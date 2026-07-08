---
title: "MoE架构 (Mixture of Experts)"
summary: "MoE（混合专家）通过稀疏激活实现模型容量与计算效率的平衡。在保持推理成本可控的同时，大幅扩展模型参..."
level: concept
category: uncategorized
tags: []
related: [[[Transformer架构]], [[分布式训练]], [[参数高效微调]]]
created: 2026-07-08
last_verified: 2026-07-08
confidence: medium
status: draft
---
# MoE架构 (Mixture of Experts)

## 概念

MoE（混合专家）通过稀疏激活实现模型容量与计算效率的平衡。在保持推理成本可控的同时，大幅扩展模型参数量。

## 核心思想

```
y = Σ_{i=1}^{n} G(x)_i * E_i(x)
```

- **专家 (Experts)**: 多个独立的子网络（通常是FFN）
- **门控网络 (Router/Gate)**: 决定每个输入激活哪些专家
- **稀疏激活**: 每个输入只激活Top-k个专家（通常k=1或2）

## 关键组件

### 专家层

```
每个专家是一个FFN:
E_i(x) = W_2 * activation(W_1 * x)
```

- 专家数量: 通常8-128个
- 每个专家参数量相同

### 门控网络 (Router)

```
G(x) = Softmax(TopK(x * W_g))
```

- 计算每个专家的得分
- 只保留Top-k个专家
- Softmax归一化选中的专家得分

### 辅助损失 (Auxiliary Loss)

**问题**: 专家负载不均衡，部分专家过载/闲置

**解决方案**: 添加负载均衡损失

```
L_aux = α * (标准差/均值)²
```

- 鼓励各专家均匀使用
- α: 平衡系数

## 训练技巧

### 容量因子 (Capacity Factor)

```
expert_capacity = (batch_size * k / num_experts) * capacity_factor
```

- 控制每个专家处理的最大token数
- 超过容量的token被丢弃或路由到其他专家

### 专家并行 (Expert Parallelism)

- 不同专家分布在不同设备
- 需要All-to-All通信
- 与数据并行结合

### 路由策略

- **Top-k路由**: 选择得分最高的k个专家
- **Expert Choice**: 专家选择token（非token选专家）
- **BASE**: 最优传输理论的路由

## 代表模型

| 模型 | 参数量 | 激活参数 | 专家数 |
|-----|--------|---------|--------|
| Switch Transformer | 1.6T | 1.6B | 2048 |
| GLaM | 1.2T | 96B | 64 |
| Mixtral 8x7B | 47B | 13B | 8 |
| Grok-1 | 314B | ~80B | 8 |

## 优势与挑战

### 优势
- **计算效率**: 推理成本远小于总参数量
- **扩展性**: 可持续增加专家数量
- **专业化**: 不同专家可能学习不同领域知识

### 挑战
- **训练不稳定**: 路由收敛问题
- **负载均衡**: 需要辅助损失
- **通信开销**: 分布式训练的All-to-All通信
- **内存占用**: 总参数量大，需要更多显存

## 与稠密模型对比

| 特性 | MoE | 稠密模型 |
|-----|-----|---------|
| 参数效率 | 高 | 低 |
| 训练稳定性 | 低 | 高 |
| 推理速度 | 快（相同激活参数） | 相同 |
| 内存需求 | 高（总参数） | 低 |
| 微调难度 | 高 | 低 |

## 相关概念

- [[Transformer架构]] - MoE通常替换FFN层
- [[分布式训练]] - 专家并行策略
- [[参数高效微调]] - MoE的微调挑战
