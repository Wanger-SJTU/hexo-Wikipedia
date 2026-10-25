---
title: "nano-PEARL: DT分离与并行投机解码的框架级实现"
date: 2025-11-03
tags: [知乎]
source: https://zhuanlan.zhihu.com/p/1968679023782655324

---

News: 

[2025.11] 🔥 最近新测了一些sglang+eagle3的结果，大家感兴趣的话可以在 [benchmark](https://link.zhihu.com/?target=https%3A//smart-lty.github.io/nano-PEARL/benchmark.html) 查看！

[https://github.com/smart-lty/nano-PEARL](https://link.zhihu.com/?target=https%3A//github.com/smart-lty/nano-PEARL)**写在前言：**不知道各位在读/审/投稿 Speculative Decoding 相关的文章时，有没有遇到过，或者思考过各种 spec 算法和其他加速技术的结合。反正我之前做 PEARL (parallel speculative decoding) 时，被审稿人追着问了很久的 TP 兼容问题。现在一回想，确实有道理。efficient LLM 是一个完整的领域，不同的加速技术之间如果存在冲突，那它们的贡献自然要 「re-evaluate」. 

从 Google 的 ICML oral paper 至今已经两年半的时间了，社区中涌现了非常多的 spec 算法文章，但真正落地了、考虑了和其他各种技术集成的 paper，有几篇呢？我印象里屈指可数：EAGLE 算一篇，PLD 算一篇，Lookahead 算一篇，Medusa 算半篇，最多再加上 DeepSeek 带火的 MTP。扪心自问，光是支持 batch size > 1 的推理这一点，有几篇 paper 能做到呢？从这方面来说，社区对于算法的落地是严重缺少关注的。你的 Spec 算法兼容 TP 吗？兼容 flash attention 吗？兼容 paged attention 吗？兼容这些技术时会不会遇到其他方面的问题？

所以最近我就在思考，我做的 PEARL 和以上技术结合的可能性，由此推出 nano-PEARL

这是一个非常简单、但将 parallel speculative decoding 和 prefix caching, TP, cuda graph,  flash attention, paged attention, batch inference 等等进行了结合的框架级实现。将这些技术全部结合起来，**我们可以用 3 张 H200, 把一个 70B 的 Llama 3.1 模型，在 bs=32 的情况下，跑到 3546.72 tok / s 的吞吐！**

感谢 nano-vLLM 的杰出仓库，让我能够在短短一个月之内实现各种我想要的 feature 并完成测试。简单做了一个 benchmark 结果可视化的网页，欢迎大家点进来玩！

[nano-PEARL Benchmark Results](https://link.zhihu.com/?target=https%3A//smart-lty.github.io/nano-PEARL/benchmark.html)另一方面，也希望这个框架可以帮助 spec 社区更快、更好地设计和实现各种新颖的 spec 算法，同时，再也不用担心被审稿人问：**你的算法能做 batch 推理吗？能用 TP 吗？**

**如果你：**

- 想要更快的 LLM 推理速度
- 需要在生产环境部署投机解码
- 对推理系统优化感兴趣
- 想要一个可以魔改的 spec 代码库**那么 nano-PEARL 很适合你！**

欢迎大家试用、提 issue、贡献代码。如果觉得有用，给个 ⭐️ 吧！

有任何问题或合作想法，欢迎评论区或私信交流～

**TL;DR**

- nano‑PEARL 是在 **nano‑vLLM** 风格下重写的并行投机解码引擎（单机多卡）。
- 通过 **Draft‑Target Disaggregation（DT 分离）**、**Pre‑Verify / Post‑Verify** 并行化、以及 **Prefix KV Cache / Paged Attention / FlashAttention / CUDA Graph / Tensor Parallelism / Batch Inference** 等系统优化，显著提升大模型在 **高 batch × 长上下文** 下的实际吞吐。
- 70B 级模型在 **BS=32** 的 HumanEval 评测上，峰值吞吐 **3546.72 tok/s**，对 vanilla SD 约 **3.06×** 提升（维持无损一致性）。
0. Introduction 简单回顾 PEARL
什么是 PEARL？PEARL: Parallel Speculative Decoding with Adaptive Draft Length 是 ICLR 2025 的一篇中稿文章。它识别了传统 speculative decoding 中的 mutual waiting problem: 即 drafting 阶段 target model 无法利用，verify 阶段 draft model 无法利用，从而提出 parallel speculative decoding, 让大小模型并行推理，以固定的频率进行进程间通信，从而实现更高的加速效果。

[PEARL: 并行投机解码，推理加速最新SOTA（blog/paper/code均开源）](https://zhuanlan.zhihu.com/p/716769091)
1. 为什么我们要做 nano-PEARL?
总的来说，我认为投机解码目前的发展存在以下问题：

- 高 batch setting 下，投机解码效果显著下降。现有的投机解码算法几乎都只在 bs=1 的 setting 下做实验；
- 部分 spec 算法和其他技术存在 conflict：例如 tree attention 在 bs 较大时，树的容量需要显著减小，甚至退化到链式；与现有的 flash attention kernel / paged attention 设计不能 trivial 的结合等等。
- 现有投机解码算法不能充分利用计算资源，且容易存在资源竞争、资源冲突等问题。我举一些例子：

- 关于对 batch inference 的必要性：现在 Spec 算法的一个很广泛的应用就是加速 RL 算法的 Rollout 过程，但 RL 算法的 Rollout 过程天然就需要 batch inference；如果按照 bs=1 一条一条的 decode，反而速度还不如直接用 auto-regressive 的 batch inference；
- 关于和其他技术结合的必要性：如果一个 spec 算法不支持 flash attention / cuda graph / TP 等加速技术，那实际场景下，单使用 spec 算法的加速收益，远小于框架自带的这些加速技术的收益；
- 关于计算资源分配与利用的问题：以 EAGLE 为例，draft model 部署于 GPU 0, target model 部署于 GPU 0-7；当 target model 开启 TP，推理速度显著增加，draft model 的开销占比也会显著增大；同时 GPU 0 要同时存储 draft model 和 target model 的 kv cache，在上下文变长之后很容易 OOM
2. 核心设计：Draft-Target Disaggregation (DT 分离)
起这个名字也有点蹭 PD 分离、AF 分离的嫌疑 :-)

受 PD 分离 和 AF 分离的启发：draft model 和 target model 的推理路径，或者说推理行为本身就不一致: 

- draft model 参数量通常远小于 target model, 适用的 TP 数通常也和 target model 不一样；
- draft model 通常要进行连续的 auto-regressive 的推理，而 target model 通常进行 一次性的，多 token 的 verification 的推理；
- draft model 和 target model 都需要使用 GPU 推理，部署于同一张卡时，很容易发生抢占资源、或者资源分配不均以及炸显存的问题；基于这些分析，DT 分离也就很自然了：我们让 draft model 和 target model 分别位于不同的 device 上，每张 GPU 只运行一份模型，自然就可以分别操控每个模型的推理！

3. Draft Model 的开销不可忽略
正如我于之前的帖子 [Speculative Decoding: 总结、分析、展望](https://zhuanlan.zhihu.com/p/1904881828906668879) 中写的一样：随着 spec 的发展，draft model 的开销一定会越来越大。因为整个 speculative decoding 的核心思想就是：冗余算力换带宽！随着 batch size 和 context length 的逐渐增大，冗余算力越来越小，那么 对于 Spec 来说，最最最重要的事情就是，draft tokens 尽可能不被拒绝。

那么从这个趋势来看，无论是 EAGLE 等复用 target hidden states 的方法，还是使用现有的、出厂自带的 SLM (例如 Qwen3-0.6B 作为 Qwen3-32B 的 drafter), draft model 的参数量都会逐渐 scaling 上去，draft 的 overhead 都会逐渐增大。

从这方面来说，我认为 DT 分离 + DT 并行 是一个更优雅、更鲁棒、更有效的解决方案

4. nano-PEARL 做了什么？
简而言之，就是在 nano-vllm 的基础上实现了 PEARL 算法，并且增加了一些新的 feature，比如 DT 分离、自动确定最优的 window size (gamma)等。直接放 benchmark 的结果：

![](https://pic4.zhimg.com/v2-e10c5a68259c9500ee2b5b790a967d73_r.jpg)bs=1, GSM8K, Llama-3.1-70B 最高可加速 6.27倍
![](https://picx.zhimg.com/v2-a108190fa704975fbde174ac0efea9e9_r.jpg)bs=32, HumanEval, Llama-3.1-70B 也可以实现3.06倍的吞吐最后，我们相信，并行投机解码是一个非常广阔、仍有广大发展空间的 topic。后续的可能发展方向有：

- 将 nano-PEARL 扩展到 RL 训练：天然地并行加速、step by step 的 on-policy distillation 等等
- 将 nano-PEARL 扩展到各种多模态领域，实现 图片 / 语音 / 视频的并行投机解码
- 将 nano-PEARL 与更进一步的各种算法结合，比如量化、蒸馏，retrieval-based speculative decoding 等等
- 为 PEARL 设计一个专属的 distillation / pruning 算法，在没有现有 drafter 时，仍然可以快速得到一个 drafter以上都是 intuitively 可行的 idea；欢迎感兴趣的同学联系我一起合作！