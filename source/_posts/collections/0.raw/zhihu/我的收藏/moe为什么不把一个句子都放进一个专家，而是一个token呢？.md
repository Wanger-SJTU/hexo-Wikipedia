---
title: (2 条消息) moe为什么不把一个句子都放进一个专家，而是一个token呢？
date: "2026-04-17 00:00:00"
updated: "2026-04-17 00:00:00"
layout: post
permalink: /collections/0.raw/zhihu/我的收藏/moe为什么不把一个句子都放进一个专家,而是一个token呢/
disableNunjucks: true
wiki: false
nav_hidden: true
categories:
  - 文档
tags:
  - 知乎
source_url: https://www.zhihu.com/question/646173158/answer/1934378397942936809
---


28 人赞同了该回答

因为这是由MoE的机制决定的。

在大规模预训练与下游应用中，<strong>混合专家模型</strong>（Mixture-of-Experts，简称 MOE）因其在计算资源利用上的高效性而受到广泛关注。本文详细介绍 MOE 架构的各个组成部分、训练时采用的具体策略，并以 DeepSeek‑v3 为例说明如何通过这些方法构建一个高效且鲁棒的 MOE 大模型。

*本文内容主要来自资料，专家“自发专化”那部分是我自己的理解，因为本人水平有限，如果任何错漏的地方，请大家帮忙指出来，谢谢。*

### 1. MOE 架构概述

MOE 架构的基本思想是在传统 Transformer 模型中，将每个前馈网络（FFN）层替换为一个 MOE 层。一个 MOE 层通常由两个关键部分组成：

![](/images/collections/0.raw/zhihu/%E6%88%91%E7%9A%84%E6%94%B6%E8%97%8F/asset/img_1ef1a4acb6e1.jpg)![](/images/collections/0.raw/zhihu/%E6%88%91%E7%9A%84%E6%94%B6%E8%97%8F/asset/img_0b5c546663d9.webp)

- <strong>专家网络（Experts）</strong> 每个专家是一个独立的子网络（通常是 FFN），在实际计算中只有部分专家会被激活参与处理。通过让多个专家分担不同数据子集的计算，模型在预训练时可以以较低的计算开销获得大参数量带来的表示能力​。
- <strong>门控网络（Gating/Router）</strong> 该模块负责根据输入 token 的特征动态选择激活哪些专家。门控网络一般采用一个带 softmax 的简单前馈网络来计算每个专家的权重。经过训练后，门控网络会逐步学会将相似的输入路由到表现更好的专家​。
在 DeepSeek‑v3等MOE大模型中，正是通过这种将 FFN 层替换为 MOE 层的设计，模型在拥有海量参数的同时，其实际计算量却与传统稠密模型相当，从而实现了高效预训练和快速推理。

### 2. 专家网络与自发专化

在我刚接触到MOE架构的时候，经常有一个疑问：“MOE模型中的专家方向是事先规划好的还是自发生成的。“ 经过研究发现，专家都是”自学成才“的。

![](/images/collections/0.raw/zhihu/%E6%88%91%E7%9A%84%E6%94%B6%E8%97%8F/asset/img_c47dab9a44b0.jpg)

#### 2.1 专家网络的角色

在 MOE 模型中，每个专家网络只在接收到相应路由时参与计算。初期，由于门控网络参数随机，各专家接收到的数据分布比较均匀；但随着训练进行，局部梯度更新使得某些专家逐渐专注于处理特定类型的输入数据。这种“自发专化”现象使得模型整体具备了多样化的表示能力。

在 DeepSeek‑v3 中，不同的专家可能专注于捕捉语言的不同层次信息：例如有的专家更擅长处理句法结构，而有的专家在捕捉长距离依赖或特殊符号时表现更优。这种多样性是通过端到端的训练自发形成的​。

#### 2.2 动态路由的正反馈机制

门控网络一开始的路由决策可能是近似随机的，但随着专家逐步积累专长，门控网络也会调整其路由策略：

- <strong>正反馈循环</strong>：如果某个专家因早期获得较多特定类型数据而表现出色，门控网络便倾向于将更多此类数据路由给它。
- <strong>专家和路由网络的协同演化</strong>：专家因接收到较多特定数据而“专长”，而门控网络根据反馈不断更新参数，使得路由更加精准​。

### 3. 门控网络与动态路由策略

#### 3.1 基本门控函数

最常见的门控函数即为一个简单的前馈网络，其将输入与权重矩阵相乘后经过 softmax 得到各专家的概率分布。这种设计允许每个 token 可以被分配给多个专家（通常选择 top‑k 个）​。

#### 3.2 噪声注入与 Top‑K 路由

为了防止门控网络总是偏向于选取少数专家，常用的策略是在计算专家得分时加入噪声（Noisy Top‑K Gating）：

- <strong>噪声注入</strong>：在原始得分上添加随机噪声，使得初期路由决策具有更多随机性，帮助专家获得均衡的训练机会。
- <strong>保留 Top‑K</strong>：只选取得分最高的 k 个专家，其余专家的权重设为 0，确保计算资源只分配给表现最优的专家​。

#### 3.3 动态调整与任务难度匹配

最新的研究表明，对于复杂任务可以动态激活更多专家，而对于简单任务仅激活较少专家。例如，某些论文提出了动态路由方法，根据输入的复杂度调整激活专家的数量，从而更高效利用计算资源​。

在 DeepSeek‑v3 的实现中，门控网络不仅考虑输入的特征，还根据历史路由情况动态调整激活专家，从而在保证计算效率的同时使得模型对各类任务都能充分表达。

### 4. 避免专家“过热”与“冷门”

在 MOE 模型中，一个常见问题是部分专家不断被选中（过热），而其他专家几乎没有机会更新（冷门）。为此，DeepSeek‑v3 及其他先进模型采用了以下策略：

#### 4.1 辅助负载均衡损失

在整体损失函数中增加一个辅助项，专门用于衡量各专家在一个 batch 中的激活数量的均衡性。常用方法是计算各专家激活数的变异系数（coefficient of variation, CV），并将该值作为正则项加入损失，从而鼓励门控网络尽可能平衡地分配 token​。

#### 4.2 专家容量限制

通过为每个专家设定一个处理 token 的上限（容量因子），当某个专家达到上限时，额外的 token 会被分配到其他专家或溢出处理。这种机制不仅防止了单个专家过度负载，还促使门控网络在数据分配上更加分散​。

#### 4.3 随机路由与噪声策略

噪声的引入使得初始路由决策具有随机性，降低了某些专家因早期优势而被持续选中的风险。同时，一些方法采用随机抽样机制，进一步鼓励低激活率的专家获得机会​。

### 5 简单回顾

#### 5.1 正反馈机制

门控与专家之间的正反馈机制具体过程如下：

- <strong>初始随机性</strong> 在训练开始时，门控网络的参数通常是随机初始化的，所以它对输入数据的路由决策没有明确的偏好，导致各个专家获得的数据分布大致随机或均匀。这意味着早期每个专家接收到的训练样本在类型上可能没有太明显的区别。
- <strong>专家的自发专化</strong> 由于只有被门控网络选中的专家会参与前向计算和梯度更新，随着训练的进行，不同的专家逐渐积累了各自的经验。也就是说，某些专家在早期由于恰好获得了某类数据，会在参数上逐渐适应这部分数据的特征，从而形成“专长”。这种现象是由局部梯度更新和稀疏路由机制自然产生的。
- <strong>门控网络的适应与强化</strong> 与此同时，门控网络也在不断地通过反向传播学习如何更高效地分配输入。它会逐步发现某个专家对某类输入效果更好，于是会倾向于将更多此类数据路由到这个专家，从而进一步强化该专家在这一领域的专长。整个过程就形成了一种正反馈循环：专家越专长，门控网络就越倾向于将相似数据分配给它们。
这种动态分工的机制并不是预先人为划分数据集给不同的专家，而是通过端到端的训练，让系统自发地发现和强化各个专家的“专长”。此外，还会加入负载均衡等辅助损失项，避免部分专家过于热门而其他专家几乎没有更新的情况。

#### 5.2 一次交互有多个Token，每个token的路由决策一样么？

每个 token 的路由决策是独立计算的，也就是说，在一次交互中，每个 token 都会经过门控网络单独计算其路由概率，然后根据其自身的特征分配到最合适的一个或多个专家上。结果可能是不同的 token 被分配给不同的专家，尤其当它们的语义或上下文信息有差异时。当然，如果一组 token 非常相似，它们可能会被路由到相同的专家，但这一决定依然是独立计算得出的，而不是所有 token 强制走同一路由。

#### 5.3 不同专家的区别和偏好是啥样的?

下图是英伟达在“Applying Mixture of Experts in LLM Architectures”实验中的一些结果。

链接：[Applying Mixture of Experts in LLM Architectures | NVIDIA Technical Blog](https://link.zhihu.com/?target=https%3A//developer.nvidia.com/blog/applying-mixture-of-experts-in-llm-architectures/)

#### 领域-专家分配(Domain-expert assignment)

某些领域比其他领域更频繁地激活某些专家。

在第32层，抽象代数就是一个例子，它比其他专家更频繁地使用专家三和八。

![](/images/collections/0.raw/zhihu/%E6%88%91%E7%9A%84%E6%94%B6%E8%97%8F/asset/img_002c2c575c34.jpg)

第32层抽象代数的token分布 另一方面，职业法律领域主要激活专家四，而相对较少使用专家三和八。

![](/images/collections/0.raw/zhihu/%E6%88%91%E7%9A%84%E6%94%B6%E8%97%8F/asset/img_e39c0d073369.jpg)

第32层职业法律的token分布 世界宗教是另一个有趣的例子，专家七接收的token比专家八少五倍以上。

![](/images/collections/0.raw/zhihu/%E6%88%91%E7%9A%84%E6%94%B6%E8%97%8F/asset/img_8ba81a3dea88.jpg)

第32层世界宗教的token分布 这些实验结果表明，专家们的负载分布在各种主题中趋于均匀。然而，当样本全部属于某个特定主题时，可能会出现较大的分布不平衡。

#### 专家最常处理的token

下图中的词云显示了每个专家最常处理的token。实验中画出来的不同专家偏好的词云：

![](/images/collections/0.raw/zhihu/%E6%88%91%E7%9A%84%E6%94%B6%E8%97%8F/asset/img_6c013d9c6534.jpg)

#### token最常选择的专家(Most preferred experts by tokens)

每个token是否有偏好的专家？每个token似乎都有更偏好的专家集，如下例所示。

![](/images/collections/0.raw/zhihu/%E6%88%91%E7%9A%84%E6%94%B6%E8%97%8F/asset/img_ae057997626b.jpg)

token“:”的专家分配

![](/images/collections/0.raw/zhihu/%E6%88%91%E7%9A%84%E6%94%B6%E8%97%8F/asset/img_667267a92421.jpg)

token“.”的专家分配

![](/images/collections/0.raw/zhihu/%E6%88%91%E7%9A%84%E6%94%B6%E8%97%8F/asset/img_a3dd4053ed83.jpg)

token“what”的专家分配

![](/images/collections/0.raw/zhihu/%E6%88%91%E7%9A%84%E6%94%B6%E8%97%8F/asset/img_2fac5dcd1d4f.jpg)

token“who”的专家分配
### 6. DeepSeek‑v3 的实现案例

DeepSeek V3 是一款基于混合专家（MoE）架构的大型语言模型，拥有 671B 参数，但每次推理仅激活 37B 参数，显著降低了计算成本。

![](/images/collections/0.raw/zhihu/%E6%88%91%E7%9A%84%E6%94%B6%E8%97%8F/asset/img_cf1417dbf960.jpg)

其技术优势(仅从MOE架构角度)主要体现在以下几个方面：

#### 6.1 MOE 架构

![](/images/collections/0.raw/zhihu/%E6%88%91%E7%9A%84%E6%94%B6%E8%97%8F/asset/img_9469f7cc654a.jpg)

在 DeepSeek‐V3 的 MoE 模块中，主要包含两类专家：

- 路由专家（Routed Experts）**：每个 MoE 层包含 256 个路由专家，这些专家主要负责处理输入中某些特定、专业化的特征。
- <strong>共享专家（Shared Expert）</strong>：每个 MoE 层中还有 1 个共享专家，用于捕捉通用的、全局性的知识，为所有输入提供基本的特征提取支持。
这种设计类似于“分工合作”，共享专家起到类似“总机”的作用，而路由专家则分别针对特定任务进行深入处理。

#### 6.2 Gate 网络与专家选择机制

当一个 token 的表示传入 MoE 层时，首先会经过一个专门的 Gate 网络，该网络负责计算 token 与各个路由专家之间的匹配得分。具体流程如下：

- <strong>计算匹配得分</strong> Gate 网络通过线性变换计算每个 token 与所有路由专家的兼容性得分。得分反映了 token 与各专家“契合”的程度。
- <strong>选择 Top-K 专家</strong> 基于得分，Gate 网络为每个 token 选择 Top-K 个最合适的路由专家。在 DeepSeek‐V3 中，每个 token 通常选择 8 个路由专家（在一些实现中还可能对跨节点路由做限制，如最多路由到 4 个不同节点），从而只激活极少数专家进行计算。
- <strong>专家处理与加权聚合</strong> 被选中的专家各自对 token 进行独立处理（一般采用一个轻量级的前馈网络，类似于 Transformer 中的 FFN 模块），产生各自的输出。最终，这些专家的输出会根据 Gate 网络给出的权重进行加权聚合，再与共享专家的输出进行融合，形成当前 MoE 层的最终输出表示。

#### 6.3 负载均衡策略

#### 传统 MoE 中的负载均衡问题

在传统的 MoE 模型中，由于部分专家可能会频繁被选中而另一些专家较少被激活，容易导致“负载不均衡”问题。通常解决办法是引入辅助损失来鼓励各专家的均衡使用，但这往往会带来额外的梯度干扰，影响模型收敛和最终性能。

#### DeepSeek‐V3 的创新设计

为了解决这一问题，DeepSeek‐V3 提出了<strong>无辅助损失的负载均衡策略（Auxiliary-Loss-Free Load Balancing.）</strong>，其核心思想是：

- <strong>引入偏置（Bias）</strong> 每个路由专家都会有一个可学习的偏置项。当某个专家长期处于低使用状态时，其偏置会自适应地上调，从而增加其被选中的概率；反之，对于被频繁激活的专家，其偏置会下降，从而降低激活概率。这种方法可以在不引入额外损失项的情况下，自动实现专家之间的负载均衡。
- <strong>仅影响路由选择</strong> 值得注意的是，这个偏置项只用于专家选择过程，即在计算得分时加上偏置，而不会在专家输出加权求和时使用，从而确保了最终输出不受不必要的干扰。
这种设计既达到了均衡专家使用的目的，又避免了传统辅助损失带来的副作用，使得模型训练更加稳定高效。

#### 6.4 推理阶段的资源利用

DeepSeek‑v3 在推理时只激活部分专家，因此虽然需要加载全部专家的参数到显存中，但实际参与计算的参数仅为部分(671B模型每个Token激活 37B )，从而大幅提高推理速度​。

### 7. 参考资料

[https://huggingface.co/blog/zh/moe](https://link.zhihu.com/?target=https%3A//huggingface.co/blog/zh/moe)

[Mixture-of-Experts with Expert Choice Routing](https://link.zhihu.com/?target=https%3A//arxiv.org/abs/2202.09368) 

[Harder Tasks Need More Experts: Dynamic Routing in MoE Models](https://link.zhihu.com/?target=https%3A//arxiv.org/abs/2403.07652) 

[Prediction Is All MoE Needs: Expert Load Distribution Goes from Fluctuating to Stabilizing](https://link.zhihu.com/?target=https%3A//arxiv.org/abs/2404.16914) 

[SwitchHead: Accelerating Transformers with Mixture-of-Experts Attention](https://link.zhihu.com/?target=https%3A//arxiv.org/abs/2312.07987)

[Switch Transformers: Scaling to Trillion Parameter Models with Simple and Efficient Sparsity](https://link.zhihu.com/?target=https%3A//arxiv.org/abs/2101.03961)

[https://github.com/deepseek-ai/DeepSeek-V3/blob/main/DeepSeek_V3.pdf](https://link.zhihu.com/?target=https%3A//github.com/deepseek-ai/DeepSeek-V3/blob/main/DeepSeek_V3.pdf)

[Applying Mixture of Experts in LLM Architectures | NVIDIA Technical Blog](https://link.zhihu.com/?target=https%3A//developer.nvidia.com/blog/applying-mixture-of-experts-in-llm-architectures/)

 

送礼物

还没有人送礼物，鼓励一下作者吧

[发布于 2025-07-31 22:22](//www.zhihu.com/question/646173158/answer/1934378397942936809)・黑龙江

​添加评论​75 ​喜欢​分享

​​

收起​