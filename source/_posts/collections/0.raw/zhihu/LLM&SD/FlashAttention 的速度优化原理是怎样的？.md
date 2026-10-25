---
title: FlashAttention 的速度优化原理是怎样的？
date: "2026-01-17 00:00:00"
updated: "2026-01-17 00:00:00"
layout: post
permalink: /collections/0.raw/zhihu/LLM-SD/FlashAttention-的速度优化原理是怎样的/
disableNunjucks: true
wiki: false
nav_hidden: true
categories:
  - 文档
tags:
  - 知乎
source_url: https://www.zhihu.com/question/611236756/answer/1995961359377138616
---


本文将从第一性原理出发，基于现象观察和算法推导提供 FlashAttention 从软件到硬件的分析视角。

相关概念
从第一性原理来思考 FlashAttention 的整个设计思路，Flash Attention 诞生前：

假设如下：

- Batch size B = 64
- Seq len N = 1024
- Num heads H = 16
- Head dimension d = 64Attention 有两个矩阵乘法，, Total FLOPs = 4 × B × H×N^2 × d = 275 GFLOPs

作为对比， NV A100 fp16 tensor core 的峰值算力(Peak FLOPs)是 312 TFLOPs ， 那么可以得到理论耗时：

Time = Total FLOPs / Peak FLOPs = 0.88 ms

但是论文中测试得到的结果是 41.7ms，如下：

![](https://pica.zhimg.com/v2-7377323553b3451a262c8d18a95b005c_r.jpg?source=2c26e567)

那么问题在哪里？

看 Roofline Model 和 算术强度 (概念问 GPT / Gemini)

算术强度 = 计算量(FLOPs) / 访存量(Bytes) , A100 的 Fp16 算力 是 312 FLOPs, 带宽是 1.5T， 那么 Rooflikne model 的转折点是 200FLOPs/Byte, 也就是每从显存读一个字节的数据，必须在 GPU 上面进行 200 次浮点运算，才能跑满 Tensor Core。

如果计算少于 200 次/字节，瓶颈在带宽， 如果计算多余 200 次/字节，瓶颈在计算。

Attention 的数据流图分析

![](https://pic1.zhimg.com/v2-102f8c9e715b65beebda951bc19cc0b3_r.jpg?source=2c26e567)

步骤操作名称HBM 读取 (Input)核心计算 (Compute)HBM 写入 (Output)涉及矩阵规模性能特征 (瓶颈)1QK GEMMRead Q, KS=Q⋅K^TWrite SS 为 N×NCompute Bound(算术强度较高)2SoftmaxRead SP=softmax(S)Write PS,P 均为N×NMemory Bound(算术强度极低)3PV GEMMRead P, VO=P⋅VWrite OP 为 N×NCompute Bound(算术强度较高)

很明显可以看到，中间保存了两个 matrix S 和 P， 大小都是 NxN, 计算量和显存量都和 N 成正比。

计算强度理论分析
接着我们来分析 Attention 每个步骤的算术强度， 假设 N = 1024, d = 64。

Q 的维度是[N, d]

![](https://www.zhihu.com/equation?tex=k%5ET) 维度是 [d, N]

![](https://www.zhihu.com/equation?tex=S+%3D+Q%2AK%5ET) 维度是 [N, N]

QK GEMM
下面分析计算量:

S 中每个元素都要做一次长度为 d 的向量点积（d 次乘加 = 2d FLOPs），总的 FLOPs = N^2 x 2d .

FLOPs = N^2×2d = 134,217,728 FLOPs

下面分析访存量：

Read Q + K = 2 x N x d x 2Bytes = 2.5MB

Write S = N x N x 2Bytes = 2.0MB

总 IO = 2.25 MB

下面是算术强度 = FLOPs / 总 IO = 56.9 FLOPs / Byte

评估：通常矩阵乘法的计算强度，受限于最小的维度，也就是近似 d， 这里 d=64，所以还凑合，A100 的峰值是 200+，但是已经能跑出来 30% 利用率了。

Mask + Softmax + Dropout
mask 是比较操作，可以忽略不计，dropout 是随机掩码相乘，忽略不计。

Softmax （element-size 操作）这是导致 memory wall 的主因，S 大小 NxN，包含 3 个流程：

- Read S matrix ( NxN 个 FP16)
- 每个元素 e^x 运算 + 求和 + 除法
- 写回 matrix

下面分析计算量：

每个元素约 8FLOPs , 总元素数量 NxN， FLOPs = NxNx8 = 8,388,608 FLOPs

下面分析访存量：

```text
Read S matrix = NxNx2 = 2,097,152 Bytes

Write P matrix = NxNx2 = 2,097,152 Bytes
```


(这里如果考虑反向传播，还需要保存 P, 写入量 double，推理不用管）

总 IO = 4xNxN = 4,194,304 Bytes

下面是计算强度 = 2.0 FLOPs / Byte

利用率约为 1%！ 计算单元完全浪费了

PV GEMM
首先分析维度 : P NxN, V Nxd, O Nxd

输出维度 Nxd，每个输出元素要做长度 N 的点积

计算量：

FLOPs = Nxd x 2xN = 134,217,728 FLOPs

访存量：

Read P + read V + write O = NxN + Nxd + Nxd = 3MB

计算强度是 = 51.2 FLOPS/Byte

能接受。

总结：整体是 memory bound， 看第 2 阶段（Softmax），虽然它的计算量（0.08 亿）只有矩阵乘法（1.34 亿）的 6%，但它贡献了 45% 的显存读写量。

![](https://picx.zhimg.com/v2-8ce56b454a228383843e1fe7f25b1ed7_r.jpg?source=2c26e567)

Online Softmax 公式推导
softmax 是整个算法的瓶颈，softmax 的问题在于显存。因此我们的优化目标不是减少计算，而是减少对两次 HBM matrix 的读写，从而减少访存量。

SRAM 通常只有 100-200KB，而我们的 NxN FP16 矩阵是 2MB，很自然的想到使用 Tiling 来解决该问题。如下图所示：

![](https://pic1.zhimg.com/v2-d126e69e1ecee84b95386a45255e9c9e_r.jpg?source=2c26e567)matmul 天然支持 tiling,对于下面的公式，可以先计算 Q1K1^T ， 再计算 Q2K2^T，二者互不干扰，那么 QK GEMM 和 PV GEMM 的问题解决了。

![](https://picx.zhimg.com/50/v2-221b0091feecb97ccaa77c5ff4895c9a_720w.jpg?source=2c26e567)现在的问题是 softmax 不支持，softmax 分母是求和，softmax 计算一个元素的值，也需要所有的元素和。

这里转化为一个数学问题：如何推导出一个迭代公式，允许我们用旧的统计量和新的数据更新出新的全局统计量？

这就是 online softmax 公式。

假设有两个块的数据 , 我们的目标是计算全局 softmax。为了防止数值移除，softmax 的计算都会在指数位置减去一个最大值 m, 因此分母如下所示：

![](https://www.zhihu.com/equation?tex=%5Ctext%7BSoftmax%7D%28x%29_i+%3D+%5Cfrac%7Be%5E%7Bx_i+-+m%7D%7D%7B%5Csum_%7Bj%3D1%7D%5EN+e%5E%7Bx_j+-+m%7D%7D) 

假设数据块 1 局部最大值是 m1, 那么数据块 1 的分母就是

![](https://www.zhihu.com/equation?tex=%5Cell_1+%3D+%5Csum+%7Be%5E%7Bx%5E%7B%281%29%7D+-+m1%7D%7D) 

数据块 2 的分母同理：

![](https://www.zhihu.com/equation?tex=%5Cell_2+%3D+%5Csum+%7Be%5E%7Bx%5E%7B%282%29%7D+-+m2%7D%7D) 

问题变为 m1, m2 不同，无法合并。现在我们需要统一到一个最大值，才能进行相加，这里

![](https://www.zhihu.com/equation?tex=%5Cell_%7B%5Ctext%7Bnew%7D%7D+%3D+%5Cmax%28m_1%2C+m_2%29) 

继续推导

![](https://www.zhihu.com/equation?tex=%5Cbegin%7Baligned%7D+%5Cell_%7B%5Ctext%7Bnew%7D%7D+%26%3D+%5Csum_%7Bk+%5Cin+B_1+%5Ccup+B_2%7D+e%5E%7Bx_k+-+m_%7B%5Ctext%7Bnew%7D%7D%7D+%5C%5C+%26%3D+%5Csum_%7Bi+%5Cin+B_1%7D+e%5E%7Bx_i+-+m_%7B%5Ctext%7Bnew%7D%7D%7D+%2B+%5Csum_%7Bj+%5Cin+B_2%7D+e%5E%7Bx_j+-+m_%7B%5Ctext%7Bnew%7D%7D%7D+%5C%5C+%26%3D+%5Csum_%7Bi+%5Cin+B_1%7D+e%5E%7Bx_i+-+m_1+%2B+m_1+-+m_%7B%5Ctext%7Bnew%7D%7D%7D+%2B+%5Csum_%7Bj+%5Cin+B_2%7D+e%5E%7Bx_j+-+m_2+%2B+m_2+-+m_%7B%5Ctext%7Bnew%7D%7D%7D+%5C%5C+%26%3D+e%5E%7Bm_1+-+m_%7B%5Ctext%7Bnew%7D%7D%7D+%5Cunderbrace%7B%5Csum_%7Bi+%5Cin+B_1%7D+e%5E%7Bx_i+-+m_1%7D%7D_%7B%5Cell_1%7D+%2B+e%5E%7Bm_2+-+m_%7B%5Ctext%7Bnew%7D%7D%7D+%5Cunderbrace%7B%5Csum_%7Bj+%5Cin+B_2%7D+e%5E%7Bx_j+-+m_2%7D%7D_%7B%5Cell_2%7D+%5C%5C+%26%3D+%5Cell_1+e%5E%7Bm_1+-+m_%7B%5Ctext%7Bnew%7D%7D%7D+%2B+%5Cell_2+e%5E%7Bm_2+-+m_%7B%5Ctext%7Bnew%7D%7D%7D+%5Cend%7Baligned%7D) 

通过该推导，最终我们只需要在 SRAM 中维护 3 个变量：

![](https://www.zhihu.com/equation?tex=m_1+%2C+m_2%2C+m_%7Bnew%7D) 

最终结果 O = PV

![](https://www.zhihu.com/equation?tex=%5Cbegin%7Baligned%7D+O_%7B%5Ctext%7Bnew%7D%7D+%26%3D+%5Cfrac%7B1%7D%7B%5Cell_%7B%5Ctext%7Bnew%7D%7D%7D+%5Csum_%7Bj+%5Cin+B_1+%5Ccup+B_2%7D+e%5E%7Bx_j+-+m_%7B%5Ctext%7Bnew%7D%7D%7D+V_j+%5C%5C+%26%3D+%5Cfrac%7B1%7D%7B%5Cell_%7B%5Ctext%7Bnew%7D%7D%7D+%5Cleft%5B+%5Csum_%7Bj+%5Cin+B_1%7D+e%5E%7Bx_j+-+m_%7B%5Ctext%7Bnew%7D%7D%7D+V_j+%2B+%5Csum_%7Bj+%5Cin+B_2%7D+e%5E%7Bx_j+-+m_%7B%5Ctext%7Bnew%7D%7D%7D+V_j+%5Cright%5D+%5C%5C+%26%3D+%5Cfrac%7B1%7D%7B%5Cell_%7B%5Ctext%7Bnew%7D%7D%7D+%5Cleft%5B+%5Csum_%7Bj+%5Cin+B_1%7D+e%5E%7Bx_j+-+m_1+%2B+m_1+-+m_%7B%5Ctext%7Bnew%7D%7D%7D+V_j+%2B+%5Csum_%7Bj+%5Cin+B_2%7D+e%5E%7Bx_j+-+m_2+%2B+m_2+-+m_%7B%5Ctext%7Bnew%7D%7D%7D+V_j+%5Cright%5D+%5C%5C+%26%3D+%5Cfrac%7B1%7D%7B%5Cell_%7B%5Ctext%7Bnew%7D%7D%7D+%5Cleft%5B+e%5E%7Bm_1+-+m_%7B%5Ctext%7Bnew%7D%7D%7D+%5Cunderbrace%7B%5Csum_%7Bj+%5Cin+B_1%7D+e%5E%7Bx_j+-+m_1%7D+V_j%7D_%7B%5Cell_1+O_1%7D+%2B+e%5E%7Bm_2+-+m_%7B%5Ctext%7Bnew%7D%7D%7D+%5Cunderbrace%7B%5Csum_%7Bj+%5Cin+B_2%7D+e%5E%7Bx_j+-+m_2%7D+V_j%7D_%7BP%5E%7B%282%29%7D+V%5E%7B%282%29%7D%7D+%5Cright%5D+%5C%5C+%26%3D+%5Ctext%7Bdiag%7D%28%5Cell_%7B%5Ctext%7Bnew%7D%7D%29%5E%7B-1%7D+%5Cleft%28+%5Ctext%7Bdiag%7D%28%5Cell_1%29+e%5E%7Bm_1+-+m_%7B%5Ctext%7Bnew%7D%7D%7D+O_1+%2B+e%5E%7Bm_2+-+m_%7B%5Ctext%7Bnew%7D%7D%7D+P%5E%7B%282%29%7D+V%5E%7B%282%29%7D+%5Cright%29+%5Cend%7Baligned%7D) 

Flash Attention Tiling 公式推导
下面来理解 Paper 里面的伪代码。

![](https://picx.zhimg.com/v2-aa577ed6f3bb27442f8751ec9be4962c_r.jpg?source=2c26e567)line1 有两个公式

![](https://picx.zhimg.com/v2-77b4bf16b02383c023eb6d97fb7f714e_r.jpg?source=2c26e567)其中 M 是 sram 大小，为什么除 4？因为要在 SRAM 中计算，需要在 SRAM 中驻留 4 个 matrix ，

- Kj 大小 Bc x d
- Vj 大小 Bc x d
- Qi 大小 Br x d
- Oi 大小 Br x d
忽略的细节：中间变量 Sij 的处理
这里其实忽略了中间变量 Sij， 这里我没有看到有相关的文章提及，所以我讲一下。Sij 是 KV matmul, 计算出来之后就得算 softmax， 然后乘 V, 累加到 O，再扔掉。因为该变量会扔掉，所以不需要预留一个永久的空间。

那么 Sij 存放在哪里？存放在 Tensor Core 的 Accumulator 或者寄存器，Flash Attention 巧妙地设计了算法，使得 Softmax 的很多操作（求 max，求 sum）可以在寄存器层面通过 Warp Shuffle（线程间通信）完成。

假设我们要计算的 Sij 的一行有 32 个元素，该 32 个元素分布在一个 warp 的各个 thread 里面，我们需要算出来这一行的最大值。问题在于 thread 里面的寄存器是各自私有的，怎么办？

Nvidia 提供了 warp shuffle ，允许同一个 Warp 里的线程，直接通过寄存器总线读取其他线程的寄存器值，不需要经过 SRAM 或 Cache。

为了在寄存器层面算出 max 或 sum，Flash Attention 使用了经典的并行规约算法。(自行 GPT/Gemini) .

下面对比一下走 SRAM 和走 Warp shuffle 的差距：

走 SRAM

- 32 个线程写 SRAM (Store)。
- 等待内存屏障 (Barrier)。
- 32 个线程读 SRAM (Load) 做原子操作或串行归约。
- 耗时： 可能需要 几百个时钟周期。走 Warp shuffle

- 5 次 Shuffle 操作。
- 每次操作只需要 1-2 个时钟周期。
- 耗时： 总共 10-20 个时钟周期。
- 内存占用： 0 Bytes SRAM。回到上面的占用空间分析， 我们的 SRAM 至少需要容纳 4 块内容，假设 Br = Bc = B , 那么：

这里论文中为了简洁，使用元素数量 d 描述 , 所以没有 2

Tile 划分策略
Q 按行切分，切成 Tr = N/Br 块

K V 按列切分，切成 Tc = N/Bc 块

![](https://picx.zhimg.com/v2-7f9fc63e9388888a34940f3700d08745_r.jpg?source=2c26e567)接着执行双重循环，外层循环固定 K V， 每次开始内循环之前，从 HBM 搬运 K V 到 SRAM, 这样只需要 K V 只加载一次就能被所有的 Q 使用一遍

5: for 1 <= j <= Tc do
6:     Load K_j, V_j from HBM to SRAM
内循环遍历 Q , 这里根据我们之前的讨论，需要加载 3 个中间变量

O_i : 目前为止的输出结果

l_i : 目前为止的指数和

m_i ： 目前为止的最大值

7: for 1 <= i <= Tr do
8:     Load Q_i, O_i, l_i, m_i from HBM to SRAM
接着就是我们前面提到的计算流程，计算完成后再写回 HBM。

反向传播的问题
backward 需要中间值来求导，那么 S P 是否要存到 HBM?

HBM 带宽比较昂贵，Tensor Core 是廉价过剩的资源，因此我觉得应该使用算力换取存储，forward 不存 NxN， backward 再重新读进去 SRAM, 计算出梯度，用完即扔。