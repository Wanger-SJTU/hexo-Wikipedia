---
title: 从FlashAttention到编译器自动融合：浅读PLDI 2026论文Neptune
date: "2026-05-19 00:00:00"
updated: "2026-05-19 00:00:00"
layout: post
permalink: /collections/0.raw/zhihu/AI-infra/从FlashAttention到编译器自动融合-浅读PLDI-2026论文Neptune/
disableNunjucks: true
wiki: false
nav_hidden: true
categories:
  - 文档
tags:
  - 知乎
source_url: https://zhuanlan.zhihu.com/p/2040074326905462952
---


最近读到一篇很有意思的PLDI 2026论文：[Neptune: Advanced ML Operator Fusion for Locality and Parallelism on GPUs](https://link.zhihu.com/?target=https%3A//arxiv.org/pdf/2510.08726)。这篇论文解决的问题非常典型，很多深度学习算子明明在数学上只有几行公式，但在gpu上跑得快，往往需要专家手写复杂kernel，比如flashattention（FA）、flashdecoding（FD）。Neptune想解决的问题是FA这种高级融合算子，能不能不靠专家手写，而是变成tensor compiler里的通用优化primitive。

更准确的说，Neptune做的是一种advanced operator fusion。它可以从一个普通的attention数学定义出发，通过编译器里的transformation，自动生成类似FA和FD的融合kernel。

一、Motivation
深度学习模型通常写成很多tensor operators的组合，例如一个非常简单的程序：

y = relu(x)
z = y + 1
如果按照普通框架执行，它可能会变成两个kernel：

kernel 1: y = relu(x)
kernel 2: z = y + 1
这样中间tensor y要写回global memory，然后下一个kernel再读回来，频繁读写中间结果会浪费大量带宽。

所以编译器会做operator fusion：

z = relu(x) + 1
融合之后，中间结果y不需要materialize到global memory，可以直接在寄存器或sharded memory里完成。这种elementwise fusion很容易，但attention这类算子要复杂很多。

标准attention大概是：

score = QK^T / sqrt(d)
P = softmax(score)
O = P@V
// 展开一点就是
/*
1. QK^T: 矩阵乘法，得到attention score
2. scale / mask / bias: 对score做elementwise修改
3. softmax：对每一行做归一化
4. P@V：再做一次矩阵乘法
*/
问题在于，score和P的形状通常是[sequence_length, sequence_length]，如果sequence_length比较大，那中间矩阵就非常大。FA的核心思想就是不要把完整attention score和softmax矩阵写到HBM，而是在tile内一边计算一边更新softmax统计量，最后直接得到输出。这听起来像operator fusion，但它不是普通的fusion，因为softmax里面有多个reduction，而且这些reduction之间有依赖。

稳定版softmax通常写成：

m_i = max_j x_ij // 沿着j维度对x_ij取最大值
p_ij = exp(x_ij - m_i)
s_i = sum_j p_ij // 沿着j维度对p_ij求和
out_ij = p_ij / s_i
这里有两个reduction：

m_i = max_j x_ij
s_i = sum_j p_ij
第二个reduction sum依赖第一个reduction max的最终结果，也就是说，只有当整行最大值m_i算完之后，才能正确计算每个exp(x_ij - m_i)。这就是普通编译器很难自动融合attention的根本原因。

![](https://pic2.zhimg.com/v2-4fc6335103414043c22aa06c2b30f7cf_r.jpg)Neptune用Fig. 1给了一个非常小的例子，这个例子是理解全文的关键。

输入矩阵是:

inp = 
row 0: [0, 1, -1, 2]
row 1: [6, 5, 7, 3]
原始程序分三步：

# s_max: 每一行求最大值
for i in range(2):
    for j in range(4):
        xmax[i] = max(xmax[i], inp[i, j])

# s_exp: 每个元素减去行最大值后取 exp
for i, j in grid(2, 4):
    xexp[i, j] = exp(inp[i, j] - xmax[i])

# s_sum: 每一行求和
for i, j in grid(2, 4):
    xsum[i] += xexp[i, j]
这就是softmax的前半部分`max → exp → sum` 。对第0行[0, 1, -1, 2]来说，最终最大值是xmax[0] = 2，所以正确的xexp是：

exp(0 - 2)  = e^-2
exp(1 - 2)  = e^-1
exp(-1 - 2) = e^-3
exp(2 - 2)  = e^0 = 1
正确的xsum[0]是`e^-2 + e^-1 + e^-3 + 1` 。对应Fig. 1(a)和Fig. 1(d)。那为什么naive fusion会得到错误的结果呢？既然我们想fusion，一个自然想法就是把三段loop合成一段：

for i in range(2):
    for j in range(4):
        xmax[i] = max(xmax[i], inp[i, j])
        xexp[i, j] = exp(inp[i, j] - xmax[i])
        xsum[i] += xexp[i, j]

这就是Fig. 1(b)里的naive fusion。但是它是错误的，因为在第 j 次迭代时，xmax[i] 只是目前看到的最大值，不是整行最终最大值。还是看第 0 行[0, 1, -1, 2]，j=0时当前只看到[0]，所以：

xmax = 0
xexp = exp(0 - 0) = 1
但正确结果应该是`exp(0 - 2) = e^-2`。 因为最终最大值是`2`。`j=1`时，当前看到`[0, 1]`，所以`xmax = 1, xexp = exp(1 - 1) = 1` ，但正确结果是`exp(1 - 2) = e^-1` 。`j = 2`时当前看到`[0, 1, -1]` , 所以`xmax = 1, xexp = exp(-1 - 1) = e^-2` , 但正确结果应该是`exp(-1 - 2) = e^-3` . `j = 3`时当前看到完整行`[0, 1, -1, 2]` , 所以`xmax = 2, xexp = exp(2 - 2) = 1` . 这一项才是正确的，因为naive fusion得到的`xsum[0]`是`1 + 1 + e^-2 + 1`, 而正确结果是`e^-2 + e^-1 + e^-3 + 1`, 不一样。这就是Fig. 1(e)里橙色部分展示的错误依赖：`xexp`太早读取了`xmax`，读到的是中间值，而不是最终值。传统tensor compiler看到这种依赖关系，会认为这个fusion不合法，于是拒绝融合。

**而Neptune的核心思想是先打破依赖，允许fusion暂时算错，再用代数公式构造一个repair term把结果修复回来。**

在softmax例子里，问题是前面的`xsum`是基于`old_max`算的，但现在`max`更新成了`new_max`。那么我们需要把旧的partial sum从`old_max`的坐标系转换到`new_max`的坐标系。修正公式是：

new_sum =
    exp(old_max - new_max) * old_sum
  + exp(x - new_max)
也就是Fig. 1(c)里的代码：

for i in range(2):
    xmax_0[i] = -inf

    for j in range(4):
        # 当前 max
        xmax_1[i] = max(xmax_0[i], inp[i, j])

        # 修正旧 xsum，再加入当前项
        xsum[i] = (
            exp(xmax_0[i] - xmax_1[i]) * xsum[i]
            + exp(inp[i, j] - xmax_1[i])
        )

        # 更新 old max
        xmax_0[i] = xmax_1[i]
其中:

xmax_0 = old_max
xmax_1 = new_max
exp(old_max - new_max) = repair term
Fig. 1(f)中绿色部分展示的就是修正项和修正后的`xsum`。

**现在问题变成了为什么这个repair term是正确的？**

还是看第 0 行`[0, 1, -1, 2]`，第0行读到0初始`old_max = -inf, xsum=0`读到`x = 0, new_max = 0`更新`xsum=exp(-inf - 0) * 0 + exp(0 - 0) = 1`，此时`xsum`表示`exp(0 - 当前max)=exp(0 - 0) = 1`，这是对当前前缀[0]来说是正确的。第1步读到1，现在`old_max = 0, xsum = 1`，读到`x = 1, new_max = 1`，注意旧的`xsum = 1`其实是`exp(0 - 0)`，但现在`max`变成了1，所以旧项应该变成`exp(0 - 1) = e^-1`，怎么把`exp(0 - 0)`变成`exp(0 - 1)`，只要乘`exp(0 - 1)`，也就是`exp(old_max - new_max)`，所以`xsum = exp(0 - 1) * 1 + exp(1 - 1) = e^-1 + 1`，这正是前缀[0, 1]在当前`max = 1`下的正确`sum`为`exp(0 - 1) + exp(1 - 1)`。第2步读到-1，现在`old_max = 1, new_max = max(1, -1) = 1`，`max`没变，所以repair factor是`exp(1 - 1) = 1`，于是`xsum = e^-1 + 1 + exp(-1 - 1) = e^-1 + 1 + e^-2`，这是前缀`[0, 1, -1]`在当前`max = 1`下的正确`sum`。第3步读到2，现在`old_max = 1, xsum = e^-1 + 1 + e^-2`，读到`x = 2, new_max = 2`，`max`从1变成2，所以旧的所有项都要从以1为`max`转成以2为`max`，修正因子`exp(1 - 2) = e^-1`，于是`xsum = e^-1 * (e^-1 + 1 + e^-2) + exp(2 - 2) = e^-2 + e^-1 + e^-3 + 1`，这就是原始程序的正确结果。所以Neptune修正后的fused程序虽然中间结果和原程序不一样，但最终结果是一样的。

**Neptune的贡献在于它不是手写online softmax，而是把这种修正过程抽象成编译器transformation。**

二、Neptune的一般化：f、g、h分别是什么？
论文4.1节把这个例子推广到一般的reduction fusion。它考虑一种模式consumer reduction依赖producer reduction，写成公式：

t = reduce_f g(r, c)
/*
r：producer reduction 的结果
c：普通输入，不是 reduction 产生的值
g(r, c)：consumer reduction 的每一项
f：consumer reduction 的 reducer
t：consumer reduction 的 partial result
*/
在softmax例子中xsum = sum_j exp(inp[i,j] - xmax[i])对应：

f(x, y) = x + y
g(r, c) = exp(c - r)
r = xmax[i]
c = inp[i,j]
Neptune要找一个repair function：h(t, r, r&#39;)，含义是：

t 原来是基于旧 r 算出来的 partial result；
现在 producer reduction 变成了 r&#39;；
h 把 t 修成基于 r&#39; 的结果。
对于softmax来说h(t, r, r&#39;) = t * exp(r - r&#39;)。

Neptune要求repair function h满足两个条件。

条件1: 能修正单个term

h(g(r, c), r, r&#39;) = g(r&#39;, c)
意思是如果一个单项原来是用旧 r 算的，h 可以把它改成用新 r&#39; 算的。对softmax：

g(r, c) = exp(c - r)
h(t, r, r&#39;) = t * exp(r - r&#39;)
所以：

h(exp(c - r), r, r&#39;)
= exp(c - r) * exp(r - r&#39;)
= exp(c - r&#39;)
= g(r&#39;, c)
成立。

条件2: 能修正整个partial reduction

h(x f y, r, r&#39;) = h(x, r, r&#39;) f h(y, r, r&#39;)
如果 f = +，就是：

h(x + y) = h(x) + h(y)
这意味着 h 不需要把 partial sum拆开逐项修正，而是可以直接修整个 partial sum。对softmax：

h(x + y, r, r&#39;)
= (x + y) * exp(r - r&#39;)
= x * exp(r - r&#39;) + y * exp(r - r&#39;)
= h(x, r, r&#39;) + h(y, r, r&#39;)
成立。

这两个条件是Neptune reduction fusion正确性的核心。

那 h 是怎么自动推导出来的呢？

如果：

t = g(r, c)
而且`g(r, c)` 对 `c` 可逆，也就是说我们能从 `t` 和 `r` 反推出 `c`，那么：

c = g_c^{-1}(r, t)
然后：

h(t, r, r&#39;) = g(r&#39;, g_c^{-1}(r, t))
/*
1. t 是旧 r 下的结果；
2. 先从 t 和旧 r 反推出原始输入 c；
3. 再用新 r&#39; 重新计算 g。
*/
对softmax：

t = exp(c - r)
反推：

log(t) = c - r
c = r + log(t)
所以：

h(t, r, r&#39;)
= g(r&#39;, r + log(t))
= exp((r + log(t)) - r&#39;)
= t * exp(r - r&#39;)
也就是我们前面手工看到的修正项。Neptune用符号求解器来做这一步。也就是说，编译器可以从程序表达式里自动找出 `f`、`g`，再推导出 `h`。

三、Rolling Update：生成FlashAttention-like kernel
Neptune的第一个核心transformation叫rolling update。它适合prefill attention，也就是query sequence length 比较长，key/value sequence length 也比较长。训练和prompt prefill阶段基本都是这种情况。rolling update的意思是沿着 reduction 维度逐步推进，一边更新 producer reduction，一边用 repair term 修正 consumer reduction。在softmax例子里，就是沿着 `j` 维推进`j = 0, 1, 2, 3, ...` ，维护`old_max, new_max, xsum` 。每次`max`更新，就用`xsum=exp(old_max - new_max) * xsum + exp(current_x - new_max)` 。

Rolling Update的算法步骤

![](https://pic3.zhimg.com/v2-169ca25395be8d09462ec30dd4d8d044_r.jpg)Algo. 1论文Algo. 1给出了rolling update的完整流程，为了更容易理解可以分成5步。

第一步Dataflow Reorganization。原始程序是`s_max → s_exp → s_sum` ，其中 `s_sum` 不是直接依赖 `s_max`，它依赖 `s_exp`，而 `s_exp` 再依赖 `s_max`。Neptune先把中间的 map operator inline 掉`xsum[i] += exp(inp[i, j] - xmax[i])`，这样程序变成`s_max → s_sum` 。也就是说，consumer reduction 现在直接依赖producer reduction。

第二步Naive Loop Fusion。Neptune 先故意做 naive fusion：

for i in range(2):
    for j in range(4):
        xmax[i] = max(xmax[i], inp[i,j])
        xsum[i] += exp(inp[i,j] - xmax[i])
这个程序暂时是错的，但它给了Neptune一个可以repair的结构。

第三步匹配`f`和`g` 。Neptune 从 fused loop 里识别出`xsum[i] = xsum[i] + exp(inp[i,j] - xmax[i])`，于是得到`f = + g(r, c) = exp(c - r) `。

第四步求repair function h。根据前面的公式，得到`h(t, r, r&#39;) = t * exp(r - r&#39;)`。

第五步保留producer reduction的前后两个版本。为了使用`h(xsum, old_max, new_max)`，必须同时知道旧的`xmax `和新的`xmax`。因为Neptune把 producer reduction 改成保留两个值`xmax_0 = old_max, xmax_1 = new_max`。最终生成Fig. 1(c)的正确融合程序。 

**Rolling Update如何得到FA？**

Attention的核心公式可以写成：

score_ij = q_i · k_j
m_i = max_j score_ij
p_ij = exp(score_ij - m_i)
s_i = sum_j p_ij
o_i = sum_j p_ij v_j
out_i = o_i / s_i
这里不仅 `s_i` 依赖 `m_i`，`o_i` 也依赖 `m_i`。因为`o_i = sum_j exp(score_ij - m_i) v_j`。如果 max 从 `old_m` 变成 `new_m`，那么 `o_i` 也要修`o_i = exp(old_m - new_m) * o_i + sum_j exp(score_ij - new_m) v_j `，所以 rolling update 维护三个量：

m = 当前 max
s = 当前 exp sum
o = 当前 weighted value sum 
每处理一个 key/value block：

new_m = max(old_m, block_max)
alpha = exp(old_m - new_m)
s = alpha * s + sum(exp(score_block - new_m))
o = alpha * o + sum(exp(score_block - new_m) * V_block)
m = new_m
最后`out = o / s`，这正是 FA 的 online softmax 结构。Neptune 的关键贡献是它不是直接写一个 FA kernel，而是通过 rolling update 这个通用编译器 transformation，从 plain attention expression 生成出类似 FA 的 fused operator。

Rolling Update的好处非常明显：1. 不需要 materialize attention score；2. 不需要 materialize softmax matrix；3. 减少 HBM 读写；4. 提高 tile 内数据复用；5. 降低中间 tensor 显存占用。代价也很明显：1. 每次迭代要多算 repair term；2. 要保存 old/current reduction result；3. rolling loop 变成带依赖的循环，并行性变差。第三点很关键，rolling update的更新是`j0 → j1 → j2 → ...`，后一步依赖前一步的 `m`、`s`、`o`，所以不容易沿着这个维度大规模并行。 这就是为什么Neptune还需要第二个transformation：split-K update。

四、Split-K Update：生成FlashDecoding-like kernel

![](https://pic4.zhimg.com/v2-05e2460dbcb77f31a097a9126a65ceb3_r.jpg)Fig. 3split-k update 主要适合 decoding attention。在 LLM decoding 阶段，通常query length = 1，key/value length 很长，也就是说，只有一个 query，要和一大段 KV cache 做 attention。这个场景下 query 维度几乎没有并行度，如果只用 rolling update，GPU 很容易吃不满。FlashDecoding 的核心思想是把 KV 维度切成多个 chunk，每个 chunk 并行计算 partial attention，最后再合并 partial results。Neptune 的 split-k update 就是在编译器里一般化这个思想。用一个demo理解splie-k update。

还是第 0 行`x = [0, 1, -1, 2]`，把 `j` 维切成两个 chunk：`chunk 0: [0, 1], chunk 1: [-1, 2] `，每个 chunk 本地计算 local max 和 local sum。

chunk 0:

local_max_0 = max(0, 1) = 1
local_sum_0 =
    exp(0 - 1) + exp(1 - 1)
  = e^-1 + 1 
chunk 1:

local_max_1 = max(-1, 2) = 2
local_sum_1 =
    exp(-1 - 2) + exp(2 - 2)
  = e^-3 + 1
然后全局最大值：

global_max = max(local_max_0, local_max_1)
           = max(1, 2)
           = 2
现在的问题是，`local_sum_0` 是基于 `local_max=1` 算的，但最终应该基于 `global_max=2`。所以要修正`local_sum_0_repaired = exp(local_max_0 - global_max) * local_sum_0`，也就是`(e^-1 + 1) * exp(1 - 2) = e^-2 + e^-1 `。chunk 1的local max等于global max，所以`local_sum_1_repaired = exp(2 - 2) * (e^-3 + 1) = e^-3 + 1 `，最后合并`global_sum = e^-2 + e^-1 + e^-3 + 1 `，正确。Fig. 3展示的就是这个程序结构：

# local reductions
max_l[i, j0] = max over j1
sum_l[i, j0] = sum exp(input - max_l[i,j0])

# global reductions
max_g[i] = max over j0 max_l[i,j0]
sum_g[i] += exp(max_l[i,j0] - max_g[i]) * sum_l[i,j0] 
其中`exp(max_l - max_g)`，就是repair term。

五、Rolling Update和Split-K Update的区别
可以这样理解，rolling update一边扫描一边修正旧 partial result，适合 prefill，局部性好，但 rolling 维并行性较差。split-k update先并行算多个 local partial result，再把 local 坐标系修正到 global 坐标系，适合 decoding，可以制造更多并行度。两者使用的是同一个核心`h(t, r, r&#39;)`，只不过:

rolling update:
    r = old_max
    r&#39; = new_max

split-k update:
    r = local_max
    r&#39; = global_max 
所以 Neptune 把 FA 和 FD 背后的核心算法统一到了同一个 break-and-repair 框架里。

六、Neptune的系统架构

![](https://pic2.zhimg.com/v2-8148240d01bf2f749af47b709eae3c95_r.jpg)Neptune有两个输入：Tensor Expression和High-level schedule template。

输入一tensor expression，描述的是算什么。比如attention的计算可以写成：

p = batch_matmul(q, k, trans_b=True)
score = score_mod(p)
s_max = max(score, axis=j)
s_exp = exp(score - s_max)
s_expsum = sum(s_exp, axis=j)
sv = batch_matmul(s_exp, v)
out = sv / s_expsum
论文appendix A的fig 12给出了attention的compute definition，38行代码覆盖了大多数attention variants。

![](https://pic1.zhimg.com/v2-5072ce8e99ef10f4e72690c2c720c3fc_r.jpg)输入二schedule template。这个输入描述的是如何优化，例如:

tile(...)
rolling_update(...)
cache_read(...)
set_scope(...)
decompose_reduction(...)
论文 Appendix A 的 Figure 13 给了 attention 的 schedule，大约 28 行。

![](https://pic1.zhimg.com/v2-092dd187054f6604e9add6b441a53cb2_r.jpg)Neptune 不是完全自动发现所有 schedule。它仍然需要用户提供一个 high-level schedule template。但是相比手写 Triton FlashAttention kernel，这已经抽象了很多。论文提到，Tri Dao 的 Triton attention kernel 大约 650 行，而 Neptune 的 attention 输入是 38 行 compute definition + 28 行 schedule。

七、Template-Guided Optimizer做什么
Template-Guided Optimizer 会把 tensor expression 先转换成 **loop-scalar IR**。所谓 loop-scalar IR，就是普通的 loop nest + scalar expression。例如：

for i in range(N):
    for j in range(M):
        xsum[i] += exp(inp[i,j] - xmax[i])
这个层次适合做loop fusion；rolling update；split-k update；reduction fusion；algebraic repair，因为它能清楚的看到循环结构；reduction变量；依赖关系；标量表达式。Neptune 的两个核心 transformation：rolling update 和 split-k update就是在这个层次完成的。

八、Neptune支持哪些算子
Neptune 的核心适用对象是**存在多个 reduction，并且后面的 reduction 依赖前面的 reduction 的算子。**主要包括以下几类：attention；numerically stable l2 norm；rmsnorm with dynamic scaling quantization；performer（一种近似softmax attention的近似形式）

九、局限性
只能处理固定pattern的算子，通用性不足；Neptune理论证明基于实数语义和reducer的结合律，浮点数不严格满足结合律，所以实际数值正确性需要实验验证