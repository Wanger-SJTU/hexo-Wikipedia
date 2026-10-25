---
title: (1 封私信) [深挖FA4] FA4的优化思想和代码解析
date: "2026-04-04 00:00:00"
updated: "2026-04-04 00:00:00"
layout: post
permalink: /collections/0.raw/zhihu/体系结构/[深挖FA4]-FA4的优化思想和代码解析/
disableNunjucks: true
wiki: false
nav_hidden: true
categories:
  - 文档
tags:
  - 知乎
source_url: https://zhuanlan.zhihu.com/p/2023356213597929481
---


### 概述

![](/images/collections/0.raw/zhihu/%E4%BD%93%E7%B3%BB%E7%BB%93%E6%9E%84/asset/img_c1686edcf34c.jpg)

Pipleline一览![](/images/collections/0.raw/zhihu/%E4%BD%93%E7%B3%BB%E7%BB%93%E6%9E%84/asset/img_4c8b01e5a869.jpg)

![](/images/collections/0.raw/zhihu/%E4%BD%93%E7%B3%BB%E7%BB%93%E6%9E%84/asset/img_1e8422659052.jpg)

本文分析 SM100 (Blackwell 架构) Flash Attention kernel 的执行流程，实现在我的课程专用repo [https://github.com/deciding/cutex](https://link.zhihu.com/?target=https%3A//github.com/deciding/cutex) 里。为了方便大家测试自己玩 我把原先3000多行的代码简化了一下放到`flash_fwd_sm100_simple.py` 中，虽然也有2000行但是里面有大量注释，配合本文食用应该还是挺清晰的。

FlashAttention系列是一个很大的坑。我是希望能够真正剖析优化的思想，而且不只是泛泛的论文里表面提到的东西。如果深思一下其实有很多关键问题，并没有有效的得到回答：

- 为什么使用 2 个 Q stage？
- 为什么 softmax 可以在单个线程上重用一行，相比 Hopper？
- exp2 模拟真的是 softmax 性能提升的关键来源吗？
- 为什么要 split P？性能差多少？
- 为什么fa4使用自定义 pipeline 实现？
- 为什么fa4使用自定义 GEMM 实现？
- 为什么 TMEM 这样组织？
- 为什么需要一个额外的correction warpgroup？
- etc.
如果你有同样的问题，那么这篇文章正适合你。有些问题，论文里有提，但是我感觉是有些笔误，有些表述也没有点到核心。

#### 0. 对FA4优化的总结

这篇文章只是个起点，我们先从宏观上来看FA4到底有哪些优化的点？这些点很新吗？哪些点可以很容易的apply到其他语言比如Triton里？

比如ex2 emulation，这明明是个通用的算法，我记得cpp就是用的6阶多项式近似。所以乍一听到这个优化感觉很诧异。后来才知道是为了缓解SFU压力。但是到我实测的时候感觉效果一般般，发了大力的反而是rescale threshold（10%左右吧）。我印象中这个省略rescale的方法几年前就有人提了，有印象的同学可以帮忙评论下。

blackwell下的softmax因为是通过tmem来传输P，和hopper最大的不同就是，hopper用的register导致QK的结果每行会分散在4个thread里（https://docs.nvidia.com/cuda/parallel-thread-execution/index.html#wgmma-64n16-d）。而tmem在load的时候就可以规定每行都在一个thread里，避免了warp内shuffle sync的overhead。

再就是gemm的smem desc precomputation。这个我和我的小伙伴在写我们的teraxlang compiler调FlashMLA的时候就有碰到过，register spill了，看ptx才发现是有大量的smem desc被定义。其实是完全可以复用的。所以看到tridao他们自己实现的gemm_ptx也有这个点还是很感同身受的。

split P也是一个很自然想到的点。毕竟mma一次发4个instruction，我们当时profile的时候发现这段的ALU开销还是挺大的，把SFU的计算穿插进来是个好主意。但是站在compiler的角度，这种写法太定制化了，真要泛化的话代码就写飞了。

反而我最喜欢的是把Q stage设成2这个看起来很简单的优化。我之前完全没想过，一位KV有了stage为什么内循环还要再来个Q stage？我的理解是为了把correction warp从critical path里摘出来，后面有讲。

这篇文章的结构：1.解析每个warp做的事，以及他们的伪代码。2. 重点解析每个pipeliner的作用 3.解析timeline，分析每个优化的目的和效果。

一篇文章很难讨论的很全面很细，所以我的接下来的计划是这样的：

- 每个重要的优化点都单独写一篇讲讲
- 做一些消融实验，论证每个点的重要性。
- 写篇文章讲讲flash attention发展过程
- 有些基础还是得牢固一些比如2 cta的矩阵乘，我得把我的CuTeDSL防晕系列推进下
- etc. （想写的东西有点多）
我希望起到的另一个作用是消除大家对这3000行代码的恐惧。其实fa4里面的代码写的也是有点问题，比如sm_stats pipeline感觉写的有点复杂了，还配合一个NamedBarrier使用。我发现是他们custom pipeline有点问题居然用了AsyncLoad的方式所以producer_commit会废掉。命名也有点问题比如tSrS_t2r, 看过[[CuTeDSL防晕] 无B200卡 从0开始调优GEMM到1840TFLOPS（一）](https://zhuanlan.zhihu.com/p/2020108297701732698)的朋友应该很快能发现其实写成tTRrS可能会好一些。就是tmem_load(S)操作里register的那一边。

#### 1. Kernel 配置

#### 支持特性

- BF16 & FP16 dtype
- Non-causal & causal attention
- MHA, GQA, MQA
- Head dimensions: 64, 96, 128, (192, 128)
- 变长序列 (Variable length sequences)
- Sliding window attention
- Split-KV
注意：教程目的，我们只关注最简单的 MHA

#### 关键参数

参数默认值描述m_block_size128Q block sizen_block_size128K/V block sizeq_stage2最内层循环 Q 的 stage 数 (double-buffering)kv_stage6最内层循环 KV 的 stage 数 (double-buffering)is_persistentTruePersistent schedulinguse_2cta_instrsTrue使用 2-CTA MMA 指令<strong>优化点</strong>

- 为什么使用 2 个 q_stages？因为 2 个 Q 没有 softmax stats 依赖，所以 O rescale 可以从关键路径中隔离出来

#### 2. Warp Specialization

Kernel 使用 <strong>16 个 warp per CTA</strong>，每个 warp 分配特定角色：

Warp(s)角色功能14LoadTMA 加载 Q, K, V 从 GMEM 到 SMEM12MMAGEMM 操作 (Q×K 和 P×V)0-3Softmax0Stage 0 的 softmax 计算4-7Softmax1Stage 1 的 softmax 计算8-11Correction重缩放累积的 O，写入 sO13Epilogue从 SMEM 拷贝 O 到 GMEM15Empty填充 warp (无工作)
#### 3. Memory Hierarchy

#### Shared Memory Layout 细节

Shared memory layout 使用 `make_smem_layout_a` (用于 Q/P/O) 和 `make_smem_layout_b` (用于 K/V) 计算。Inner shape 表示数据如何为 MMA 操作分区：

`sQ_layout: ((128,16), 1, (4,2), 2)
sK_layout: ((64,16), 1, (4,2), 6)  
sV_layout: ((64,16), 1, 8, 6)
sO_layout: ((8,16), (64,2), (1,2))`

<strong>Inner Shape 解读：</strong>

TensorShape含义sQ((128,16), 1, (4,2), 2)(atom_m=128, atom_k=16) × num_tiles_m=1 × (num_tiles_k=4×2) × q_stage=2sK((64,16), 1, (4,2), 6)(atom_n=64, atom_k=16) × num_tiles_n=1 × (num_tiles_k=4×2) × kv_stage=6sV((64,16), 1, 8, 6)(atom_n=64, atom_d=16) × num_tiles_n=1 × num_tiles_d=8 × kv_stage=6sO((8,16), (64,2), (1,2))(atom_m=8, count_m=16) × (atom_n=64, count_n=2) × (1, q_stage=2)注意：对于 sO，smem atom 是 `K_SW128` (K-major with 128-bit swizzle)，形状为 (8, 64)：

- atom_m=8, atom_n=64 (64×2bytes=128bytes swizzle)
- tile_to_shape: (128,128,2) / (8,64) = (16, 2, 2)

#### 为什么 sQ (128) vs sK (64)？

使用 <strong>cta_group_size = 2</strong> (2 CTA MMA instruction)，MMA tile shape 是 (256, 128, 16)。M 和 N 维度都除以 cta_group_size 得到每个 CTA 的 shared memory 分配：

所以：

- sQ 得到 128 = m_block_size / 2
- sK 得到 64 = n_block_size / 2
<strong>sK vs sV</strong>:

- sK 有 inner stride `(64,1)` → K-major layout (seq_k 是连续的)
- sV 有 inner stride `(1,64)` → V 被转置 (head_dim 是连续的)
- 这确认了 V 在 smem 中存储为 `(head_dim, seq_k)` 以提高 P×V MMA 效率
`GLOBAL MEMORY
    │

```text
    ├── Q tensor: (seq_q, head_dim) - Query
    ├── K tensor: (seq_k, head_dim) - Key
    ├── V tensor: (head_dim, seq_k) - Value (transposed)
    ├── O tensor: (seq_q, head_dim_v) - Output
    └── LSE tensor: (seq_q, num_heads) - Log-sum-exp (optional)
    │
    │ TMA Load / TMA Store
    ▼
```

SHARED MEMORY
    │
    ├── sQ: Q stages × m_block × head_dim
    ├── sK: KV stages × n_block × head_dim
    ├── sV: KV stages × n_block × head_dim_v
    ├── sO: Q stages × m_block × head_dim_v
    └── sScale: row_max 和 row_sum 存储
    │
    │ TMEM Load / Store
    ▼
TENSOR MEMORY (TMEM)
    │

```text
    ├── tS: Attention scores S = Q × K^T (128 × 256 elements)
    ├── tP: Softmax probabilities P = exp2(S - row_max)
    └── tO: 累积输出 O (m_block × head_dim_v)
    │
    ▼
```

REGISTERS
    │

```text
    ├── tSrS: Score fragment (tmem → registers)
    ├── tSrP: Probability fragment (registers → tmem)
    └── tSrO: Output fragment (tmem → registers)`
```


#### 4. Execution Flow

#### 4.1 加载顺序模式

在理解 phase 细节之前，理解 K/V 加载顺序至关重要：

`设 n = n_block_max - n_block_min (需要处理的 K/V block 数量)

第一次迭代 (初始加载):
─────────────────────────────────
1. 加载 K[n-1]    ← 最后一个 K block 先加载
2. 加载 Q[0]      ← Q stage 0
3. 加载 Q[1]      ← Q stage 1 (double buffering)
4. 加载 V[n-1]    ← 最后一个 V block

后续迭代 (流水线):
─────────────────────────────────
然后周期性：从 n-1 到 0 加载配对
  K[n-1], V[n-1] → K[n-2], V[n-2] → ... → K[0], V[0]

可视化:
────────
时间 │ 加载
─────┼──────────────────────────────────────────────────────
  0  │ K[n-1]    │ Q[0]    │ Q[1]    │ V[n-1]
  1  │ K[n-2]    │         │         │ V[n-2]
  2  │ K[n-3]    │         │         │ V[n-3]
  3  │ ...       │         │         │ ...
  4  │ K[1]      │         │         │ V[1]
  5  │ K[0]      │         │         │ V[0]
伪代码:
─────────────

# Prologue
# 第一次迭代：加载 K[n-1], Q[0], Q[1], V[n-1]
K[n-1] → sK[buffer_idx]
Q[0] → sQ[stage_0]
Q[1] → sQ[stage_1]  # 为下一个 Q 迭代预取
V[n-1] → sV[buffer_idx]

# Pipeline loop
for k_block in range(n_block_min, n_block_max):

    # 发起 TMA 加载
    if k_block 

<strong>Pipeline 管理:</strong>

- `pipeline_q`: 协调 Q 加载，在 producer (load warp) 和 consumer (MMA warp) 之间
- `pipeline_kv`: 协调 K/V 加载，在 producer 和 consumer 之间

#### 4.3 MMA Warp 操作 (Warp 12)

`S_{0, n-1} S_{1, n-1}
loop(i, 0, n-1):
  O_{0, n-1-i}
  O_{1, n-1-i}
  S_{0, n-2-i}
  S_{1, n-2-i}
O_{0, 0} O_{1, 0}`

- 自定义的gemm：

- QK 使用预计算的 desc，避免循环内 q desc 计算
- PV 使用 partial gemm，允许 split-P-arrive 优化

MMA warp 执行两个主要矩阵乘法：

#### GEMM_QK: Q × K^T → S

`Prologue
1. 等待 Q[stage] 就绪 (pipeline_q)
2. 等待 K[n-1] 就绪 (pipeline_kv)
3. 执行 GEMM: S[stage] = Q[stage] × K[n-1]^T
4. 通知 S[stage] 已就绪供 softmax 使用 (pipeline_s_p_o, s producer)
5. 释放 K[n-1] (advance pipeline_kv consumer)

对于每个 K/V block 迭代:
1. 等待 V[i] 就绪 (pipeline_kv)
2. 等待 P[i] 就绪 ( pipeline_s_p_o, o producer + p producer (实际上是 mma 是 consumer))
3. 执行 GEMM: O[stage] += P[stage][i] × V[i] ( 等待 pipeline_p_lastsplit)
4. 等待 K[i-1] 就绪 (pipeline_kv)
5. 执行 GEMM: S[stage] = Q[stage] × K[i-1]^T
6. 通知 S[stage] 已就绪供 softmax 使用 (pipeline_s_p_o, s producer)
7. 释放 K[i-1] (advance pipeline_kv consumer)
8. 释放 V[i] (advance pipeline_kv consumer)

Epilogue
1. 释放 Q[0]Q[1]
2. 等待 V[0] 就绪 (pipeline_kv)
3. 等待 P[0] 就绪 (pipeline_s_p_o, o producer + p producer (实际上是 mma 是 consumer))
4. 执行 GEMM: O[stage] += P[stage][0] × V[0] (等待 pipeline_p_lastsplit)
5. 通知 O[stage] 已就绪供 O 最终 rescale 使用 (pipeline_o_acc)
6. 释放 V[0] (advance pipeline_kv consumer)`

<strong>关键优化：</strong> `split_P_arrive` 特性允许部分 P 发送给 GEMM_PV，同时 softmax 仍在计算其余部分，实现计算重叠。

#### 4.4 Softmax 操作 (Warps 0-7)

Softmax warp 执行数值稳定的 softmax 计算：

sScale:

- 用于保存 row_sum, row_max
- 大小: 2 x m_block_size x q_stages, tidx 是 m_block_size 的索引
sm_stats_barrier:

- 大小: q_stages=2 x warps=4
`Prologue
1. 作为 producer 等待 pipeline_sm_stats
2. 计算 softmax[n-1](is_first)

对于每个 n block: softmax[i]
1. 从 mma 等待 S[stage][i] (pipeline_s_p_o, s consumer)
2. 从 tmem 加载 S → registers
3. 应用 mask (causal/local/sliding window):
   - Causal: mask 未来位置
   - Local: mask 窗口外位置
   - mask_mod: 自定义 mask 函数
4. 计算 row_max:
   - 第一次迭代: m = max(S)
   - 后续迭代: m = max(prev_m, new_m)
5. 更新 sScale 中的 acc_scale
   - 如果 log2 max diff 小于 8，则 acc_scale = 1.0
   - 通过 sm_stats_barrier 通知 correction warp
6. 应用 exp2 变换:
   - P = exp2(S * scale - row_max * scale)
   - 用新的 row_max 更新 tSrS_t2r
   - 应用 exp2 并保存到 tSrP_r2t

```text
      - 对于 4 个 frg (每个 32 沿 128 列)
         - 对于 128 个 lane，每隔 2 个
            - 如果 frg 0 和 3 (ex2_emu_start_frg)
               - 在 SFU 上做正常 exp2
            - 如果 frg 1 和 2，每隔 12 (ex2_emu_freq) 行
               - 8 (ex2_emu_freq-ex2_emu_res) 行在 SFU 上做正常 exp2
               - 4 (ex2_emu_res) 行在 ALU 上做模拟 exp2
```

7. 存储 P 到 tmem
   - 前 :

```text
      - 等待 tmem st 完成 (tcgen05.wait::st)
      - 释放供 P tmem 被 PV mma 使用 (pipeline_s_p_o, p consumer (实际上是 producer))
   - 最后 :
      - 等待 tmem st 完成 (tcgen05.wait::st)
      - 释放供 P tmem 被 PV mma 使用 (pipeline_p_lastsplit)
```

8. 计算 row_sum:
   - 作为 producer 等待 pipeline_sm_stats
   - 第一次迭代: r = sum(P)
   - 后续迭代: r = prev_r * exp2(prev_m - new_m) + sum(new_P)

Epilogue
1. 更新 sScale[_, tidx, stage]
2. 通过 sm_stats_barrier[stage][wid] 通知 correction warp

所有 work tile 完成后
1. pipeline_sm_stats.producer_tail`

<strong>优化点</strong>:

- 将 softmax stats 保存为每个线程的一行，避免 warp 同步
- scale threshold
- ALU softmax 模拟
- tmem store 每次 32 个: 节省寄存器压力。但需要 split_p 来节省时间。
- tmem 分配: 2x128 给 O，2x128 给 S (与 P 重叠)，这样 Q stages 不会在 S 上相互竞争

#### 4.5 Correction 操作 (Warps 8-11)

Correction warp 处理在线归一化和最终缩放：

`Prologue work_tile
1. 第一个 O 不需要缩放，为 mma 释放 O (pipeline_s_p_o, o consumer, 实际上是 producer)

Prologue
1. 第一个 O 不需要 correction，释放 sm stats (pipeline_sm_stats, sm_stats_barrier)

对于每个 block 迭代:
1. 通过 named barrier 等待 softmax 统计数据 sScale(row_sum 现在是 acc_scale)
2. 投票是否有线程需要 rescale (超过 rescale 阈值)
3. 从 tmem 加载 O，乘以 scale，存回 (correction_rescale)
4. 为 mma 释放 O (pipeline_s_p_o, o consumer (实际上是 producer))
5. 释放 sm stats (pipeline_sm_stats)

Epilogue
1. 对于最后一个 block:
   - 等待 row_sum (sm_stats_barrier)
   - 等待 row_max (如果输出 lse)
   - 计算最终 scale = 1.0 / row_sum
   - 等待来自 mma 的最后一个 O (pipeline_o_acc)
   - 获取 producer 锁 (pipeline_o_epi)
   - 从 tmem 加载 O，乘以 scale，存回 (correction_epilogue)
   - 释放 (pipeline_o_acc)
   - 提交 (pipeline_o_epi)
2. 对于 LSE
   - rescale row_sum 并存回 global

Epilogue work_tile
1. pipeline_o_epi.producer_tail`

<strong>优化点</strong>

- rescale threshold 非常激进，在我的情况下从未触发recale=True

#### 4.6 Epilogue 操作 (Warp 13)

Epilogue warp 将最终输出写入 global memory:

`对于每个 output stage:
1. 等待 sO 中已校正的 O (pipeline_o_epi)
2. 如果使用 TMA_O:
   - 发起 TMA store 到 global memory
   - Commit async bulk group
   - 等待完成
3. 否则 (非 TMA 路径):
   - 拷贝 sO → registers
   - 根据序列长度做 predicate
   - 存储到 global memory
4. 通知 pipeline 释放 (pipeline_o_epi)`

#### 5. Pipeline 同步

#### 关键 Pipeline 路径

`┌─────────────────────────────────────────────────────────────────────────┐
│                        PIPELINE 架构                                    │
├─────────────────────────────────────────────────────────────────────────┤
│                                                                         │
│                                                                         │
│                       pipeline_s_p_o    pipeline_sm_stats               │
│  ┌─────────┐     ┌─────────┐     ┌─────────┐     ┌─────────┐            │
│  │ Q Load  │────▶│  MMA    │────▶│ Softmax │────▶│Correct  │            │
│  │(TMA)    │     │ Q×K→S   │     │ S→P     │     │ O/scale │            │
│  └─────────┘     └─────────┘     └─────────┘     └─────────┘            │
│       │                               │  │           ▲  │               │
│       │               ───────────────────────────────│──│               │
│       │               │                  │           │  │               │
│       ▼               ▼                  │           │  ▼               │
│  pipeline_q    pipeline_s_p_o            │           │ pipeline_o_epi   │
│                       │                  │           │        │         │
│                       ▼                  │           │        ▼         │
│  ┌─────────┐     ┌──────┐     ┌───┐      │           │    ┌─────────┐   │
│  │ K/V Load│────▶│  MMA │────▶││      │           │    │Epilogue │   │
│  │(TMA)    │     │ P×V→O│     │   │      │           │    │ store O │   │
│  └─────────┘     └──────┘     └───┘      │           │    └─────────┘   │
│       │               │         ▲        │           │                  │
│       ▼               ▼         |        ▼           │                  │
│  pipeline_kv     ┌─────────┐   pipeline_p_lastsplit  │                  │
│                  │  last   │                         │                  │
│                  └─────────┘                         │                  │
│                       │                              │                  │
│                       ▼                              │                  │
│                 pipeline_o_acc────────────────────────                  │
│                                                                         │
└─────────────────────────────────────────────────────────────────────────┘`

<strong>问题</strong>：

- 当前版本的 flash-attention 自定义 PipelineAsync 有一个 producer_commit 的 bug (它使用 AsyncLoad 逻辑)，所以每个 producer_commit 必须用 sm_stats_barrier.arrive 替换
- pipeline_s_p_o 让 mma 和 softmax 都是 producer 和 consumer：

- mma: 完成 S，producer_commit 
- softmax: consumer_wait S，完成 P，consumer_*release(num=4) *
- *correction: 等待 softmax 完成 S_*{i}，rescale O_{i-1}，consumer_release(num=4) 
- mma: producer_acquire(num=8)，O += PV

#### Pipeline 定义

PipelineProducerConsumer用途pipeline_qLoad warpMMA warpQ 数据就绪pipeline_kvLoad warpMMA warpK/V 数据就绪pipeline_s_p_oMMA warpSoftmaxS 就绪pipeline_s_p_oSoftmaxMMA warpP 3⁄4 就绪pipeline_s_p_oCorrection warpMMA warpO rescaled 就绪pipeline_p_lastsplitSoftmax warpMMA warpP 最后 1⁄4 就绪pipeline_o_accMMA warpCorrection warp最终 O 累积完成pipeline_sm_statsSoftmax warpCorrection warprow_max/row_sum 就绪pipeline_o_epiCorrection warpEpilogue warpO 最终完成
#### 7. Timeline

`图例: ████ = 活跃计算, ░░░░ = 停滞/等待

你以为的时间线：

TIME ─────────────────────────────────────────────────────────────────────────────▶

LOAD  │████████████████│░░░│████████████████│░░░│████████████████│░░░│
      Load K,V (next tile) 

MMA   │██████│██████│░░░░░░│██████│██████│██████│██████│██████│██████│
       Q0×Kn-1 Q1×Kn-1      P0×Vi Q0×Ki-1 P1×Vi Q1×Ki-1 P0×Vi-1 Q0×Ki-2

SOFT  │░░░░░░│█████████████│█████████████│█████████████│█████████████│
               P0,n-1         P1,n-1   ...  P0,i-1        P1,i-1

实际的时间线 (rescale O 占据关键路径)

TIME ─────────────────────────────────────────────────────────────────────────────▶

LOAD  │████████████████│░░░░░░░░│████████████████│░░░░░░░░│████████████████│░░░░░░░░│
      Load K,V (next tile) 

MMA   │██████│██████│░░░░░░│░░░░│██████│██████│░░░░│██████│██████│░░░░│██████│██████│
       Q0×Kn-1 Q1×Kn-1           P0×Vi  Q0×Ki-1     P1×Vi  Q1×Ki-1     P0×Vi-1 Q0×Ki-2

SOFT  │░░░░░░│█████████████│████│█████████████│████│█████████████│████│█████████████│
               P0,n-1        O0   P1,n-1        O1    P0,i-1       O0    P1,i-1

Correction Warp 的优化效果

TIME ─────────────────────────────────────────────────────────────────────────────▶

LOAD  │████████████████│░░░│████████████████│░░░│████████████████│░░░│
      Load K,V (next tile) 

MMA   │██████│██████│░░░░░░│██████│██████│██████│██████│██████│██████│
       Q0×Kn-1 Q1×Kn-1      P0×Vi Q0×Ki-1 P1×Vi Q1×Ki-1 P0×Vi-1 Q0×Ki-2

SOFT  │░░░░░░│█████████████│█████████████│█████████████│█████████████│
               P0,n-1         P1,n-1   ...  P0,i-1        P1,i-1

CORR  │░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░│████│░░░░░░░░│████│░░░░░░░░│
                                        Correct O0    Correct O1

EPI   │░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░│████████████│

为什么使用 double Q？

TIME ─────────────────────────────────────────────────────────────────────────────▶

MMA   │██████│░░░░░░░░░░░░░│██████│██████│██████│██████│██████│██████│
       Q×Kn-1               P×Vn-1 Q×Kn-2 P×Vn-2 Q×Kn-3 P×Vn-3 Q×Kn-4

SOFT  │░░░░░░│█████████████│█████████████│█████████████│█████████████│
               P,n-1         P,n-2         P,n-3        P,n-4

CORR  │░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░░│████│░░░░░░░░│████│░░░░░░░░│
                                        Correct O     Correct O (与 PV 冲突！)

Split P 的优化效果

TIME ─────────────────────────────────────────────────────────────────────────────▶

MMA       ░░░░░░░░░░░░░│██████│██████│██████│██████│██████│██████│
                            

SOFT  │░░░░░░│█████████████│█████████████│█████████████│█████████████│`

<strong>优化点</strong> 为什么 split P 有助于关键路径？ 我怀疑 tcgen05 mma issue 需要很长的 ALU 执行时间。

贴个图方便手机端的同学观看

![](/images/collections/0.raw/zhihu/%E4%BD%93%E7%B3%BB%E7%BB%93%E6%9E%84/asset/img_149e212f871b.jpg)

为什么Correction Warps有用![](/images/collections/0.raw/zhihu/%E4%BD%93%E7%B3%BB%E7%BB%93%E6%9E%84/asset/img_1a74515ea813.jpg)

为什么2 q_tages有用![](/images/collections/0.raw/zhihu/%E4%BD%93%E7%B3%BB%E7%BB%93%E6%9E%84/asset/img_97567b76c518.jpg)

为什么split P有用
#### 8. TMEM Layout

`Tensor Memory 分配 (总共 512 列):

┌───────────────────────────────────────────────────┐
│  0-127     │ 128-255    │ 256-383    │ 384-511    │
│  tS[stage0]│  tS[stage1]│  tO[stage0]│  tO[stage1]│
│  (S scores)│  (S scores)│  (O accum) │  (O accum) │
└───────────────────────────────────────────────────┘
     │           │

```text
     │ tmem_s_to_p_offset = 64
     ▼           ▼
```

┌──────────────────────────────────────────────────────────┐
│  tP (Softmax probabilities) 与 tS 共享存储               │
│  tP[stage] = tS[stage] + 64 (偏移 n_block_size/2)       │
└──────────────────────────────────────────────────────────┘`
