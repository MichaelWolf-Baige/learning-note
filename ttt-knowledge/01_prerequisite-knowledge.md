# 01_前置知识基础

## 目录
1. [Meta-learning原理](#1-meta-learning原理)
2. [Self-supervised Learning](#2-self-supervised-learning)
3. [Online Learning](#3-online-learning)
4. [RNN/LSTM/Transformer基础](#4-rnnlstmtransformer基础)
5. [相关数学基础](#5-相关数学基础)

---

## 1. Meta-learning原理

### 1.1 什么是Meta-learning

Meta-learning（元学习）是"学习如何学习"的范式，旨在让模型学会快速适应新任务。在传统机器学习中，模型从大量数据中学习一个固定任务；而在meta-learning中，模型从多个任务中学习"如何快速学习新任务"的能力。

**核心思想**：学习一个良好的**初始化参数**，使得模型能够用少量样本快速适应新任务。

### 1.2 MAML算法详解

**Model-Agnostic Meta-Learning (MAML)** 是最经典的元学习算法之一，由Finn et al. (2017)提出。

#### 1.2.1 数学形式

MAML的目标是学习一个初始化参数 $\theta$，使得对于任意新任务 $\mathcal{T}_i$，经过少量梯度下降步后能快速收敛。

**任务采样**：

$$\mathcal{T}_i = \{(\mathbf{x}^j_i, \mathbf{y}^j_i)\}_{j=1}^{N_k}$$

其中 $N_k$ 是k-shot设置（通常5-shot或1-shot）。

**内循环（任务适应）**：
对任务 $\mathcal{T}_i$ 进行 $K$ 步梯度下降：

$$\theta_i' = \theta - \alpha \nabla_\theta \mathcal{L}_{\mathcal{T}_i}(\theta)$$

其中 $\alpha$ 是内循环学习率， $\mathcal{L}_{\mathcal{T}_i}$ 是任务损失。

**外循环（元优化）**：

$$\theta \leftarrow \theta - \beta \nabla_\theta \sum_{\mathcal{T}_i} \mathcal{L}_{\mathcal{T}_i}(\theta_i')$$

其中 $\beta$ 是元学习率。

#### 1.2.2 MAML与TTT的关联

TTT本质上是一种**测试时元学习**：
- **MAML**：在多个训练任务上学习如何快速适应新任务
- **TTT**：在测试时根据当前测试样本动态调整模型

TTT的外循环类似于MAML，但关键区别在于：
- MAML：元训练阶段学习通用的初始化
- TTT：在每个测试序列上进行实时训练

### 1.3 Few-shot Learning

Few-shot learning（小样本学习）是meta-learning的主要应用场景，核心挑战是**从少量样本中泛化**。

**N-way K-shot分类**：
- N：类别数
- K：每个类的样本数

常见设置：5-way 1-shot, 5-way 5-shot

---

## 2. Self-supervised Learning

### 2.1 概述

Self-supervised learning（自监督学习）是一种无需人工标注标签的学习范式，通过设计**预文本任务（pretext task）**从数据本身生成监督信号。

### 2.2 主要方法

#### 2.2.1 对比学习（Contrastive Learning）

**核心思想**：将正样本对拉近，负样本对推远。

**损失函数（InfoNCE）**：

$$\mathcal{L}_{CL} = -\log \frac{\exp(\mathbf{z}_i \cdot \mathbf{z}_j / \tau)}{\sum_{k=1}^{N} \exp(\mathbf{z}_i \cdot \mathbf{z}_k / \tau)}$$

其中 $\tau$ 是温度参数， $\mathbf{z}_i, \mathbf{z}_j$ 是正样本对的表示。

**典型方法**：
- SimCLR：简单对比学习框架
- MoCo：动量对比学习
- CLIP：图文对比学习

#### 2.2.2 自编码（Autoencoder）

**掩码语言模型（MLM）**：

$$\mathcal{L}_{MLM} = -\sum_{t \in \text{masked}} \log P(x_t | x_{\setminus t})$$

**下一个token预测（NTP）**：

$$\mathcal{L}_{NTP} = -\sum_{t} \log P(x_{t+1} | x_{\leq t})$$

这是语言模型的标准目标，也是TTT中使用的自监督目标。

---

## 3. Online Learning

### 3.1 概念

Online learning（在线学习）是指模型在数据流上持续更新参数，每次处理一个样本或小批量数据进行梯度下降。

**与批学习的区别**：
- 批学习：整个数据集一起计算梯度
- 在线学习：每个样本立即更新参数

### 3.2 在线梯度下降

**随机梯度下降（SGD）**：

$$\theta_{t+1} = \theta_t - \eta_t \nabla \mathcal{L}(\theta_t; x_t, y_t)$$

其中 $\eta_t$ 是随时间衰减的学习率。

### 3.3 TTT与Online Learning的关系

TTT将测试时的每个token视为一个"在线学习"步骤：
- 传统在线学习：用梯度下降更新参数 $\theta$
- TTT：用梯度下降更新隐藏状态 $h$

关键区别：TTT更新的是**隐藏状态**（fast weights），而参数 $\theta$ 保持不变。

---

## 4. RNN/LSTM/Transformer基础

### 4.1 RNN基本原理

**循环神经网络（RNN）**通过隐藏状态 $h_t$ 传递历史信息：

$$h_t = \sigma(W_{xh} x_t + W_{hh} h_{t-1} + b_h)$$

$$y_t = W_{hy} h_t + b_y$$

**问题**：长距离依赖导致梯度消失/爆炸

### 4.2 LSTM

**长短期记忆网络（LSTM）**通过门控机制解决梯度问题：

$$f_t = \sigma(W_f \cdot [h_{t-1}, x_t] + b_f) \quad \text{遗忘门}$$

$$i_t = \sigma(W_i \cdot [h_{t-1}, x_t] + b_i) \quad \text{输入门}$$

$$\tilde{C}_t = \tanh(W_C \cdot [h_{t-1}, x_t] + b_C) \quad \text{候选细胞}$$

$$C_t = f_t * C_{t-1} + i_t * \tilde{C}_t \quad \text{细胞更新}$$

$$o_t = \sigma(W_o \cdot [h_{t-1}, x_t] + b_o) \quad \text{输出门}$$

$$h_t = o_t * \tanh(C_t)$$

### 4.3 Transformer

**自注意力机制**：

$$\text{Attention}(Q, K, V) = \text{softmax}\left(\frac{QK^T}{\sqrt{d_k}}\right)V$$

**多头注意力**：

$$\text{MultiHead}(Q, K, V) = \text{Concat}(\text{head}_1, ..., \text{head}_h)W^O$$

其中 $\text{head}_i = \text{Attention}(QW_i^Q, KW_i^K, VW_i^V)$

**复杂度分析**：
- 自注意力： $O(n^2 \cdot d)$（n是序列长度，d是维度）
- RNN： $O(n \cdot d^2)$

### 4.4 线性注意力（Linear Attention）

线性注意力通过核函数近似将复杂度降至 $O(n \cdot d)$：

$$\text{Attention}(Q, K, V)_i = \frac{\sum_{j=1}^{i} \kappa(\mathbf{q}_i, \mathbf{k}_j) \mathbf{v}_j}{\sum_{j=1}^{i} \kappa(\mathbf{q}_i, \mathbf{k}_j)}$$

**TTT的一个重要理论贡献**（Theorem 1）：

$$\text{TTT-Linear} = \text{Linear Attention}$$

---

## 5. 相关数学基础

### 5.1 梯度计算

**链式法则**：

$$\frac{\partial \mathcal{L}}{\partial \theta} = \frac{\partial \mathcal{L}}{\partial f} \cdot \frac{\partial f}{\partial \theta}$$

**自动微分**：深度学习框架使用反向模式自动微分，计算效率为 $O(1)$ 乘以前向计算量。

### 5.2 优化理论

#### 5.2.1 梯度下降

$$\theta_{t+1} = \theta_t - \eta \nabla \mathcal{L}(\theta_t)$$

#### 5.2.2 Adam优化器

$$m_t = \beta_1 m_{t-1} + (1-\beta_1) g_t$$

$$v_t = \beta_2 v_{t-1} + (1-\beta_2) g_t^2$$

$$\hat{m}_t = \frac{m_t}{1-\beta_1^t}, \quad \hat{v}_t = \frac{v_t}{1-\beta_2^t}$$

$$\theta_{t+1} = \theta_t - \eta \frac{\hat{m}_t}{\sqrt{\hat{v}_t} + \epsilon}$$

TTT论文使用的配置： $\beta_1=0.9, \beta_2=0.95$

### 5.3 矩阵运算

**矩阵-向量乘法**：

$$\mathbf{y} = W \mathbf{x}, \quad y_i = \sum_j W_{ij} x_j$$

**复杂度**： $O(d_1 \cdot d_2)$ for $W \in \mathbb{R}^{d_1 \times d_2}$

### 5.4 范数与距离

**L2范数**： $\|\mathbf{x}\|_2 = \sqrt{\sum_i x_i^2}$

**点积**： $\mathbf{x} \cdot \mathbf{y} = \|\mathbf{x}\|_2 \|\mathbf{y}\| \cos\theta$

---

## 本章小结

本章介绍了理解TTT所需的前置知识：
1. **Meta-learning**：TTT的外循环与MAML类似，学习如何快速适应
2. **Self-supervised learning**：TTT使用next-token prediction作为自监督目标
3. **Online learning**：TTT在测试时进行增量更新
4. **RNN/LSTM/Transformer**：TTT是一种新型序列建模层
5. **数学基础**：梯度计算、优化理论、矩阵运算

这些知识为理解TTT的核心创新——**在测试时训练隐藏状态**——奠定了基础。
