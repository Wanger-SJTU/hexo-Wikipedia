---
title: "Speculative Decoding: 从Padding 的视角重新理解投机解码"
date: 2026-01-06
tags: [知乎]
source: https://zhuanlan.zhihu.com/p/1991904699117490479
---

**写在前言：**最近在思考 Speculative Decoding 底层系统设计的时候，顺着一条逻辑链想下去，突然冒出了一个新的理解视角。本文尝试把这个思考过程完整地梳理一下.

***声明**：本文为 Opus 4.5 提取本人写作风格，根据本人思考路径扩展而来，并非 100% 手写*

### 0. 从两个基本事实说起

做过 LLM inference 优化的同学应该都知道两个基本事实：

**事实一：Decode 阶段是 memory-bandwidth bound**

Prefill 阶段做的是矩阵-矩阵乘（GEMM），计算量大，是 compute-bound；而 decode 阶段每次只生成一个 token，做的是矩阵-向量乘（GEMV），瓶颈在于读取 KV Cache，是 memory-bandwidth bound。

**事实二：Batch size 和 Context length 对资源的影响方向相反**

- **Batch size 增大**：算力需求增长得比带宽需求快 → 系统往 compute-bound 方向走
- **Context length 增大**：带宽需求增长得比算力需求快 → 系统往 memory-bound 方向走
说人话就是：小 batch 的时候算力闲着，长 context 的时候带宽不够用.[[1]](#ref_1)

### 1. 一个自然的问题：闲置的算力怎么办？

既然 decode 阶段算力是过剩的，那能不能把这些闲置的算力利用起来？

Speculative Decoding 给出了一个答案：**用小模型先 draft 几个 token，再用大模型一次性 verify**。因为 verify 多个 token 和 verify 一个 token 的时间差不多（瓶颈在读 KV Cache，不在计算），所以相当于"免费"多拿了几个 token。这个思路大家都懂。但我想问一个更底层的问题：

**Speculative Decoding 在系统层面到底在干什么？**
### 2. 换一个角度：Padding 在干什么？

在回答上面的问题之前，我们先想一个看似无关的问题：**传统的 Padding 在干什么？**

为了让 GPU kernel 跑得高效，我们经常要把输入 pad 到某些 "friendly" 的尺寸——比如 Flash Attention 的 tile size、Tensor Core 的对齐要求 (128 倍数) 等。

传统的做法是 **补 0**：

- 这些 0 消耗了算力（GPU 还是要对这些位置做计算）
- 但产出为零（对最终结果没有贡献）
**传统 Padding 的本质：用 无效计算** 换取 **kernel 效率**。这里有一个关键观察：**Padding 消耗的是"本来就要浪费"的算力**。

等等，这个描述是不是很眼熟？

### 3. 关键洞察：Speculation 和 Padding 在做同一件事

让我们把两件事情放在一起看：

aPaddingSpeculation 背景 Kernel 需要特定尺寸 Decode 阶段算力过剩做法补 0 凑尺寸补 draft tokens 消耗闲置/浪费的算力闲置/浪费的算力产出PaddingSpeculation背景Kernel 需要特定尺寸Decode 阶段算力过剩做法补 0 凑尺寸补 draft tokens消耗闲置/浪费的算力闲置/浪费的算力产出0（无效）> 0（可能被 accept）0（无效）> 0（可能被 accept）看到了吗？**它们的共同点是：都在利用"本来就要浪费"的算力。**

区别只是：

- Padding 补的是 0，产出为 0
- Speculation 补的是 draft tokens，产出有期望收益
这就引出了本文的核心观点：

**Speculative Decoding 可以被理解为一种 "智能 Padding"——用 draft tokens 替代传统的 zeros，把原本浪费的算力转化为有期望收益的投机计算。**说人话就是：**反正这些算力也要浪费，不如赌一把。**

### 4. 从 Padding 的视角重新理解 Speculation

一旦把 Speculation 理解成一种特殊的 Padding，很多事情就变得更清晰了。

#### 4.1 Speculation 长度 = Padding 长度

传统 padding 要 pad 多少？取决于 **当前输入离 kernel-friendly 尺寸差多少**。

类比过来：Speculation 要 speculate 多少？取决于 **当前系统有多少闲置算力可以"填充"**。

- 算力闲置多（小 batch、长 context、memory-bound 严重）→ 可以 pad 更多 draft tokens
- 算力接近饱和（大 batch、compute-bound）→ 没有空间可以 pad，硬塞只会增加负担
这解释了为什么 **speculation 长度应该是动态的**，而不是固定的 K——因为"可用的 padding 空间"本来就是动态的。

#### 4.2 为什么 Long Context 收益大？

从 padding 的视角：Context 越长 → 系统越 memory-bound → 算力闲置越多 → **可以 pad 的空间越大** → speculation 收益越大。

#### 4.3 为什么 Large Batch 收益递减？

从 padding 的视角：Batch 越大 → 系统越 compute-bound → 算力已经饱和 → **没有空间可以 pad** → speculation 反而是负担。

#### 4.4 Kernel-Friendly Speculation

这是这个视角最直接的工程推论。

很多 kernel 需要把输入 pad 到特定尺寸（比如 128、256）。传统做法是补 0。

新思路：**既然都要 pad，为什么不用 draft tokens 来 pad？**

- 输入尺寸还是 kernel-friendly 的 → kernel 效率不变
- 但补的不是 0 而是 draft tokens → 期望产出增加
这就是 **"Speculation as Padding"** 最直接的落地方式：把原本要补 0 的位置，换成 draft tokens。注意，即使是 compute-bound 等状态下，仍然存在需要 padding 的状态，将这些 padding 的方式由 “0 padding”转变为"speculative padding"仍然会有 marginal 的收益。

### 5. 统一视角：资源平衡框架

把 Batching、Padding、Speculation 放在一起看，它们其实都在做同一件事：**在 compute 和 memory bandwidth 之间找平衡**。

策略做法效果 Batching 增加请求数把算力用满 Padding 补 0 凑尺寸让 kernel 高效（但浪费算力）Speculation 补 draft tokens策略做法效果Batching增加请求数把算力用满Padding补 0 凑尺寸让 kernel 高效（但浪费算力）Speculation补 draft tokens让 kernel 高效 + 把闲置算力用起来让 kernel 高效 + 把闲置算力用起来从这个角度看：

**Speculation 是 Padding 的上位替代——在需要"填充"的时候，用有意义的 draft tokens 替代无意义的 0。**而 Speculation 和 Batching 则是互补的：

- **请求多**：用 Batching 把算力用满
- **请求少**：用 Speculation 把闲置算力用起来
一个理想的调度器应该能在两者之间动态切换。

### 6. 边界与局限

这个类比也有它的边界：

**类比的边界**：传统 padding 的 0 是被 attention mask 掉的，对输出不产生影响；而 draft tokens 会参与计算、影响 hidden states。所以这更像是 **"时间维度的展开"**，而不是严格意义上的 "padding"。

**"不亏"是有条件的**：当 accept rate 低、draft model 太贵、或系统已经 compute-bound 时，speculation 是会亏的——就像 padding 太多也会浪费资源一样。

**不是所有 padding 都能替换**：Padding 的原因有很多（batch 内变长、head dim 对齐、静态编译 shape 等），其中不少场景不能直接用 draft tokens 替代。

### 7. 一些待探索的方向

既然 "用 draft tokens 填充闲置算力" 是一个通用思路，还有什么可以 speculative？

- **Speculative Prefetching**：基于 draft tokens 预测要用哪些 KV Cache，提前加载
- **Speculation 感知的 Kernel 设计**：让 tile size 的选择考虑 draft model 的典型输出长度
- **统一的调度器**：根据系统状态动态决定 speculation 深度和 batching 策略

### 8. 总结

让我们回顾一下整个思考链条：

- **观察**：Decode 阶段是 memory-bound，算力闲置
- **问题**：闲置的算力能不能利用起来？
- **类比**：Padding 也在"浪费"算力，只是补的是 0
- **洞察**：Speculation 本质上是在做同一件事，只是补的是 draft tokens
- **推论**：Speculation 长度 = 可用的 padding 空间；Kernel-friendly speculation 是直接落地方式
**核心 Insight**：Speculative Decoding 可以被理解为一种特殊的 Padding——用 draft tokens 替代传统的 zeros，把原本浪费的算力转化为有期望收益的投机计算。我个人觉得，这个视角至少提供了一个 elegant 的抽象，可以指导后续的系统设计。当然具体实现里肯定还有很多坑，但思路应该是对的

### 参考

- [^](#ref_1_0)MagicDec [https://arxiv.org/abs/2408.11049](https://arxiv.org/abs/2408.11049)
