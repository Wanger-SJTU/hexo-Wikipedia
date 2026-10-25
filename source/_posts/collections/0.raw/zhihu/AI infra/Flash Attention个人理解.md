---
title: "Flash Attention个人理解"
date: "2025-10-26 00:00:00"
updated: "2025-10-26 00:00:00"
layout: "post"
permalink: "/collections/0.raw/zhihu/AI-infra/Flash-Attention个人理解/"
disableNunjucks: true
wiki: false
nav_hidden: true
categories:
  - "文档"
tags:
  - "知乎"
source_url: "https://zhuanlan.zhihu.com/p/1965867186716407094"
---


由于前两天面试一家百亿私募被问到简历里的attention，空间复杂度是 
$O(n^2)$ 该如何优化显存，自己支支吾吾的在问attention的时候回答出来了去年大一暑假时上课讲的flash attention，但是面试时只记得flash attention可以加速，不记得加速原理和可以优化空间复杂度，遂写一篇文章记录一下

Flash Attention降低时空复杂度原理
我自己的理解是通过将 
$QK^T$ 这个大矩阵<strong>分块</strong>，一方面降低了空间复杂度，另一方面可以让torch从GPU的 
$HBM（High Bandwidth Memory）$ 进入到 
$SRAM（Static Random-Access Memory）$ ，众所周知SRAM具有更快的访问速度和更低的延迟，同时可以降低HBM的访问量，达到提升速度的效果

（果然当知道了原理，我就不会被flash这个单词迷惑，认为他单纯只是加速而没有降低空间复杂度了）

Flash Attention计算原理

## 1. 标准注意力机制回顾

对于查询向量 
$q$ （ 
$Q$的一行），键矩阵 
$K$和值矩阵
$V$ ，标准注意力的输出为：

$o=\frac{\sum_{j=1}^{N}{\exp(s_j)v_j}}{\sum_{j=1}^{N}{\exp(s_j)}} \tag{1}$ ​​

其中 
$s_j=q⋅k_j^T/\sqrt{d_k}$ ​​，​ 
$k_j$ 和  
$v_j$ 分别是 K和 V 的第 j 行。为了数值稳定性，通常引入最大值 
$m = max_js_j$ ​：

$o = \frac{\sum_{j=1}^{N} \exp(s_j - m^*) v_j}{\sum_{j=1}^{N} \exp(s_j - m^*)} \tag{2}$ 令 
$a = \sum_{j=1}^{N} \exp(s_j - m^*) v_j， l = \sum_{j=1}^{N} \exp(s_j - m^*)$ 这样最终的输出就转化为了 
$$o = \frac{a}{l}$$


2.分块（ tiling ）计算
分块计算里面有两个问题，一个是 
$softmax$ 函数是按整行计算的，所以如果切成两个小块分别计算再拼起来是不准确的（因为分母不一样），所以必须想到一种办法可以让不断的更新全局最大值

这自然而然就想到了类似动态规划的计算方法，每次都记录最大值并且更新输出，只要更新到最后，我的 
$output$ 和原始的使用整个矩阵相乘是一样的，下面我们一步一步来看

先将 
$K 、V$ 切成 
$B$ 个 
$$blocks: K = [K_1, K_2, \ldots, K_B], V = [V_1, V_2, \ldots, V_B]$$


我们对于每个块 
$i$ 维护三个状态量

- 
$m(i)$ ：处理前 
$i$ 个块后的全局最大值。
- 
$l(i)$ ：处理前 
$i$ 个块后的调整指数和（基于 
$m(i)$ ）。
- 
$o(i)$ ：处理前 
$i$ 个块后的部分输出（未归一化，相当于调整后的分子）。初始化时 
$$m^{(0)} = -\infty， l^{(0)} = 0 ， o^{(0)} = 0，$$


对于每个块 
$i=1$ 到 
$B$ ：

1.计算当前块的分数： 
$$s_i = q \cdot K_i^T / \sqrt{d_k}$$


2.计算当前块的最大值： 
$$m_i = \max_{j \in \text{块} i} s_j$$


3.更新全局最大值： 
$$m^{(i)} = \max(m^{(i-1)}, m_i)$$


4.计算调整因子： 
$$\alpha_{\text{old}} = \exp(m^{(i-1)} - m^{(i)})  \\ \alpha_{\text{new}} = \exp(m_i - m^{(i)}) \tag{3}$$


5.更新指数和： 
$$l_{\text{old}} = l^{(i-1)} \cdot \alpha_{\text{old}} \\     l_i = \sum_{j \in \text{块} i} \exp(s_j - m_i) \\     l_i^{\text{adj}} = l_i \cdot \alpha_{\text{new}} \\     l^{(i)} = l_{\text{old}} + l_i^{\text{adj}} \tag{4}$$


6.更新输出：

$$o_{\text{old}} = o^{(i-1)} \cdot \alpha_{\text{old}} \\     o_i = \sum_{j \in \text{块} i} \exp(s_j - m_i) v_j \\     o_i^{\text{adj}} = o_i \cdot \alpha_{\text{new}} \\     o^{(i)} = o_{\text{old}} + o_i^{\text{adj}} \tag{5}$$


处理完所有块后，最终输出为： 
$$o = \frac{o^{(B)}}{l^{(B)}}$$


3.通过数学归纳法证明并计算一下
我们证明对于任意  
$i$ ，以下关系成立： 
$$o^{(i)} = \sum_{j=1}^{n_i} \exp(s_j - m^{(i)}) v_j \\ l^{(i)} = \sum_{j=1}^{n_i} \exp(s_j - m^{(i)}) \tag{6}$$

$i =0$ 时显然成立，上面两个量都为0

假设对 
$i-1$ 成立，则对 
$i有$ ：

$o_{\text{old}} = o^{(i-1)} \cdot \exp(m^{(i-1)} - m^{(i)}) \\ = \sum_{j=1}^{n_{i-1}} \exp(s_j - m^{(i)}) v_j \\ o_i^{\text{adj}} = \sum_{j \in \text{块} i} \exp(s_j - m^{(i)}) v_j \tag{7}$ 因此：

$$o^{(i)} = o_{\text{old}} + o_i^{\text{adj}} = \sum_{j=1}^{n_i} \exp(s_j - m^{(i)}) v_j \tag{8}$$


Flash Attention torch代码

```python
import torch
import math

def flash_attention_forward(Q, K, V, block_size=256):
```


    """
    参数:

```text
        Q: 查询张量, shape (batch_size, seq_len, d_k)
        K: 键张量, shape (batch_size, seq_len, d_k)
        V: 值张量, shape (batch_size, seq_len, d_v)
        block_size: 分块大小, 控制内存使用
```

        
    返回:

```text
        O: 注意力输出, shape (batch_size, seq_len, d_v)
    """

    batch_size, seq_len, d_k = Q.shape
    d_v = V.shape[-1]

    O = torch.zeros_like(V)          # 输出张量, 初始化为零
    L = torch.zeros(batch_size, seq_len, device=Q.device)  # 指数和统计量
    M = torch.full((batch_size, seq_len), -torch.inf, device=Q.device)  # 最大值统计量

    # 计算缩放因子 (1/sqrt(d_k))
    scale = 1.0 / math.sqrt(d_k)
```

    
    # 外层循环: 按块处理键/值序列

```text
    for j in range(0, seq_len, block_size):
        # 获取当前键块和值块
        K_block = K[:, j:j+block_size, :]  # [batch_size, block_size, d_k]
        V_block = V[:, j:j+block_size, :]  # [batch_size, block_size, d_v]
```

        
        # 计算查询与键块的相似度分数

```text
        S_j = torch.matmul(Q, K_block.transpose(-2, -1)) * scale  # [batch_size, seq_len, block_size]

        # 计算当前块的最大值 (按最后一个维度)
        m_j = torch.max(S_j, dim=-1).values  # [batch_size, seq_len]
```

        
        # 更新全局最大值

```text
        M_new = torch.maximum(M, m_j)  # [batch_size, seq_len]

        # 计算调整因子 (指数部分)
        # 旧部分的调整因子: exp(M_prev - M_new)
        exp_old = torch.exp(M - M_new)  # [batch_size, seq_len]
        # 新块的调整因子: exp(m_j - M_new)
        exp_new = torch.exp(m_j - M_new)  # [batch_size, seq_len]

        # 使用当前块的局部最大值计算指数 (数值稳定性)
        # P_j = exp(S_j - m_j)
        P_j = torch.exp(S_j - m_j.unsqueeze(-1))  # [batch_size, seq_len, block_size]
```

        
        # 计算当前块的指数和
        l_j = P_j.sum(dim=-1)  # [batch_size, seq_len]
        
        # 计算当前块的加权和输出

```text
        # O_j = P_j @ V_block
        O_j = torch.matmul(P_j, V_block)  # [batch_size, seq_len, d_v]

        # 调整旧输出: O_prev * exp(M_prev - M_new)
        O = O * exp_old.unsqueeze(-1)  # 保持维度一致

        # 调整新块输出: O_j * exp(m_j - M_new)
        O_j_adjusted = O_j * exp_new.unsqueeze(-1)

        # 更新输出: O = O_prev_adjusted + O_j_adjusted
        O = O + O_j_adjusted

        # 调整旧指数和: L_prev * exp(M_prev - M_new)
        L = L * exp_old

        # 调整新块指数和: l_j * exp(m_j - M_new)
        l_j_adjusted = l_j * exp_new

        # 更新指数和: L = L_prev_adjusted + l_j_adjusted
        L = L + l_j_adjusted
```

        
        # 更新全局最大值

```text
        M = M_new

    # 最终归一化: O = O / L
    O = O / L.unsqueeze(-1) 

    return O
```

在pytorch2.0以上的版本F.scaled_dot_product_attention融合了Flash Attention的算子，不过经过评论区大佬 [@shenjingwa33](https://www.zhihu.com/people/fdb860fe88410c80c6106880bd6eaa22) 的指正这里的适用范围很其实狭窄，合适的硬件和对应的编译文件都配套才可以，看来还是不能偷懒了：

```python
import torch.nn.functional as F

output = F.scaled_dot_product_attention(
    query, key, value,
    attn_mask=None,
    dropout_p=0.0,
    is_causal=False
)
```

Flash Attention通过数学和工程上的简单优化，达到了即降低运行时间，又降低显存占用，可谓十分优雅，确实是太强了