# TTT论文 Section 2 详细解读

> 论文: *Learning to (Learn at Test Time): RNNs with Expressive Hidden States*
> 
> 来源: Stanford, UC San Diego, UC Berkeley, Meta AI
> 
> arXiv: 2407.04620

---

## 目录

1. [Section 2.1: TTT as updating a hidden state](#section-21-ttt-as-updating-a-hidden-state)
2. [Section 2.3: Learning a self-supervised task for TTT](#section-23-learning-a-self-supervised-task-for-ttt)
3. [Section 2.4: Parallelization with mini-batch TTT](#section-24-parallelization-with-mini-batch-ttt)
4. [Section 2.5: Dual Form](#section-25-dual-form)
5. [Section 2.6: Theoretical Equivalences](#section-26-theoretical-equivalences)
6. [总结与核心贡献](#总结与核心贡献)

---

## Section 2.1: TTT as updating a hidden state

### 1. 核心洞察：自监督学习的压缩能力

论文首先提出一个关键观察：

> **参数化学习的过程本质上是将海量训练集压缩进模型权重的过程。**

具体来说：
- 用自监督任务（如next-token prediction）训练的模型，其权重能够捕获训练数据的**底层结构和关系**
- 这正是RNN隐藏状态作为"压缩启发式"所需要的特质
- LLM本身就是绝佳例子：其权重可视作对互联网知识的压缩存储

---

### 2. TTT的关键创新：将隐藏状态变成一个模型

传统RNN的隐藏状态是一个**固定大小的向量**，表达能力受限。

TTT的核心idea是：

```
隐藏状态 st = 模型 f 的权重 Wt
```

**具体定义：**

| 组件 | 传统RNN | TTT |
|------|---------|-----|
| **隐藏状态** | 向量 $s_t$ | 模型权重 $W_t$ |
| **模型类型** | 无 | 线性模型、MLP等 |
| **表达能力** | 受限于向量维度 | 取决于模型复杂度 |

---

### 3. 输出规则与更新规则

论文给出了两个核心公式：

#### 输出规则：
$$z_t = f(x_t; W_t)$$

**解释：** 输出token就是模型$f$用更新后的权重$W_t$对输入$x_t$的预测。

#### 更新规则：
$$W_t = W_{t-1} - \eta \nabla \ell(W_{t-1}; x_t)$$

**解释：** 权重通过一步梯度下降来更新，基于自监督损失$\ell$。

---

### 4. 自监督损失的设计

论文选择了一个**重建任务**：

$$\ell(W; x_t) = \|f(\tilde{x}_t; W) - x_t\|^2$$

其中 $\tilde{x}_t$ 是 $x_t$ 的**损坏版本**（corrupted input）。

**设计原理：**

1. **为什么要损坏？** 直接重建 $x_t$ 太简单（trivial），模型需要从部分信息 $\tilde{x}_t$ 重建完整 $x_t$
2. **这迫使模型做什么？** 发现 $x_t$ 各维度之间的**相关性**（correlations）
3. **类似什么？** 去噪自编码器（Denoising Autoencoders）的思路

**关键特性：** 梯度下降能降低损失，但不能降到零——说明这是一个有意义的学习问题。

---

### 5. 压缩视角的理解

论文提供了一个非常深刻的视角：

> **每个压缩启发式都需要决定记住什么、遗忘什么。**

**TTT的选择机制：**

- $W$ 会"记住"产生**大梯度**的输入
- 直观理解：这些输入让 $W$ "学到了很多"
- 类似人类记忆：印象深刻的事件更容易记住

---

### 6. 为什么叫"Test-Time Training"

论文解释了命名来源：

> 即使在测试时，这个层仍然为每个输入序列训练一个不同的权重序列 $W_1, \ldots, W_T$。

**关键区别：**

| 传统训练 | TTT |
|----------|-----|
| 训练时更新权重，测试时固定 | 测试时也更新权重（针对每个序列） |
| 权重在所有测试样本上共享 | 每个测试序列有专属的权重演化路径 |

---

### 7. 与传统序列建模层的统一视角

论文将所有序列建模层统一为三个组件：

```
初始状态 → 更新规则 → 输出规则
```

| 层类型 | 隐藏状态 | 更新规则 | 输出规则 | 每token成本 |
|--------|----------|----------|----------|-------------|
| **朴素RNN** | 固定大小向量 | $s_t = \sigma(\theta_s s_{t-1} + \theta_x x_t)$ | $z_t = \theta_z s_t$ | $O(1)$ |
| **Self-Attention** | KV缓存列表 | $s_t = s_{t-1}.append(k_t, v_t)$ | $z_t = V_t \text{softmax}(K_t^T q_t)$ | $O(t)$ |
| **朴素TTT** | 模型权重$W_t$ | $W_t = W_{t-1} - \eta \nabla \ell$ | $z_t = f(x_t; W_t)$ | $O(1)$ |

**TTT的优势定位：**
- 保持 $O(1)$ 的每token成本（像RNN）
- 但隐藏状态是一个**可学习的模型**，表达能力更强

---

### 8. Figure 4 的实验验证

论文展示了TTT损失在测试序列上的变化：

**关键观察：**
- $\ell(W_{t-1}; x_t)$ → $\ell(W_t; x_t)$：一步梯度下降能降低损失
- 随着 $t$ 增加， $\ell(W_t; x_t)$ 比 $\ell(W_0; x_t)$ 更低：累积学习效果
- 证明了TTT在测试时确实在进行有效的"学习"

---

## Section 2.3: Learning a self-supervised task for TTT

### 1. 核心问题：自监督任务如何设计？

论文提出了一个关键观点：

> **自监督任务是TTT最重要的部分**，因为它决定了$W$从测试序列中学到什么样的特征。

但问题是：如何设计这个任务？

---

### 2. 传统方法的局限 vs TTT的创新

**传统TTT（计算机视觉等领域）：**
- 自监督任务是**人工设计**的（如重建、对比学习）
- 依赖人类的先验知识
- 不同应用需要不同设计

**本文TTT的创新：**
> 不使用人工先验，而是**端到端学习**自监督任务本身，直接为next-token prediction这个最终目标优化。

---

### 3. 多视角重建框架

论文在朴素重建任务基础上，引入了**可学习的外循环参数**：

#### 三个"视角"（View）的定义：

| 视角 | 符号 | 定义 | 作用 |
|------|------|------|------|
| **训练视角** (Training View) | $\theta_K x_t$ | $\tilde{x}_t$ | 作为 $f$ 的输入（损坏版本） |
| **标签视角** (Label View) | $\theta_V x_t$ | - | 作为重建目标 |
| **测试视角** (Test View) | $\theta_Q x_t$ | - | 用于输出规则 |

#### 新的自监督损失：

$$\ell(W; x_t) = \|f(\theta_K x_t; W) - \theta_V x_t\|^2$$

---

### 4. 关键区别：内循环 vs 外循环参数

论文反复强调一个重要区分：

| 类型 | 符号 | 优化时机 | 角色 |
|------|------|----------|------|
| **内循环参数** | $W$ | 每个token更新一次 | 隐藏状态 |
| **外循环参数** | $\theta_K, \theta_V, \theta_Q$ | 正常训练时更新 | 损失函数的"超参数" |

**直观理解：**
- $\theta_K, \theta_V, \theta_Q$ 定义了"什么样的信息值得记忆"
- $W$ 则实际执行记忆（通过梯度更新）

---

### 5. 新的输出规则

由于训练视角 $\theta_K x_t$ 的维度比 $x_t$ 少，原来的输出规则 $z_t = f(x_t; W_t)$ 不再适用。

**新输出规则：**

$$z_t = f(\theta_Q x_t; W_t)$$

**这带来额外好处：**

| 视角 | 信息流向 | 作用 |
|------|----------|------|
| 训练视角 + 标签视角 | → $W_t$，沿时间传播 | 决定哪些信息被压缩进隐藏状态 |
| 测试视角 | → $z_t$，沿网络层传播 | 决定哪些信息输出给当前层 |

**分离设计增加了灵活性：** 训练时压缩的信息 ≠ 输出时提取的信息。

---

### 6. Figure 5: PyTorch风格代码示例

论文给出了一个清晰的代码框架：

```python
class TTT_Layer(nn.Module):
    def __init__(self):
        self.task = Task()  # θ_K, θ_V, θ_Q 在这里定义
    
    def forward(self, in_seq):
        state = Learner(self.task)  # W 在这里初始化
        out_seq = []
        for tok in in_seq:
            state.train(tok)      # 内循环：更新 W
            out_seq.append(state.predict(tok))  # 输出
        return out_seq

class Task(nn.Module):
    def __init__(self):
        self.theta_K = nn.Param((d1, d2))  # 外循环参数
        self.theta_V = nn.Param((d1, d2))
        self.theta_Q = nn.Param((d1, d2))
    
    def loss(self, f, x):
        train_view = self.theta_K @ x
        label_view = self.theta_V @ x
        return MSE(f(train_view), label_view)

class Learner():
    def __init__(self, task):
        self.task = task
        self.model = Linear()  # f 可以是线性或 MLP
        self.optim = OGD()     # 在线梯度下降
    
    def train(self, x):
        grad_fn = grad(self.task.loss)
        grad_in = grad_fn(self.model, x)  # 内循环梯度
        self.optim.step(self.model, grad_in)
    
    def predict(self, x):
        test_view = self.task.theta_Q @ x
        return self.model(test_view)
```

**代码解读：**
- `Task` 是 `nn.Module` 子类 → $\theta$ 参数会被外循环优化
- `Learner` 不是 `nn.Module` → $W$ 在内循环中手动更新
- 这清晰展示了双层学习的结构

---

### 7. 外循环的解读

论文给出一个优雅的视角：

> $\theta_K, \theta_Q, \theta_V$ 的所有可能选择，诱导出一个**多视角重建任务家族**。

**外循环的任务：** 从这个家族中选择最适合语言建模的任务。

---

## Section 2.4: Parallelization with mini-batch TTT

### 1. 问题：朴素TTT无法并行

朴素更新规则：

$$W_t = W_{t-1} - \eta \nabla \ell(W_{t-1}; x_t)$$

**并行障碍：**  $W_t$ 对 $W_{t-1}$ 有两处依赖：
1. 减号前的 $W_{t-1}$（这是顺序累加，可接受）
2. **梯度内部的 $W_{t-1}$**（这是主要瓶颈）

计算 $\nabla \ell(W_{t-1}; x_t)$ 占据大部分计算量，但必须等 $W_{t-1}$ 计算完才能开始。

---

### 2. 三种梯度下降变体分析

论文分析了三种GD策略：

#### (1) Online GD（在线梯度下降）

$$G_t = \nabla \ell(W_{t-1}; x_t)$$

| 优点 | 缺点 |
|------|------|
| 搜索空间大（ $W_t$ 距 $W_0$ 有 $t$ 步） | 无法并行 |
| 每步都用最新权重 | 必须顺序执行 |

---

#### (2) Batch GD（批梯度下降）

$$G_t = \nabla \ell(W_0; x_t)$$

| 优点 | 缺点 |
|------|------|
| 所有 $G_t$ 可并行计算（都相对于 $W_0$） | 搜索空间小（ $W_t$ 仅距 $W_0$ 一步） |
| 可一次性计算 $\sum_{s=1}^{t} \nabla \ell(W_0; x_s)$ | 性能差 |

---

#### (3) Mini-batch GD（TTT的解决方案）

$$G_t = \nabla \ell(W_{t'}; x_t)$$

其中 $t' = t - \text{mod}(t, b)$ 是上一个mini-batch的最后一个时间步。

**关键思想：**
- 每 $b$ 个token为一组
- 组内所有梯度相对于同一个 $W_{t'}$ 计算 → **可并行**
- 组与组之间顺序更新 $W$

---

### 3. Mini-batch TTT的工作流程

设 batch size $b$，序列长度 $T$：

```
Mini-batch 1: tokens 1~b
  - 并行计算 G_1~G_b（都相对于 W_0）
  - 累加得到 W_b = W_0 - η∑G_t

Mini-batch 2: tokens b+1~2b
  - 并行计算 G_{b+1}~G_{2b}（都相对于 W_b）
  - 累加得到 W_{2b} = W_b - η∑G_t

...继续...
```

---

### 4. Figure 6: 计算图可视化

论文展示了第一个TTT mini-batch的高层计算图：

```
输入变量（蓝色）：
  W_0, x_1, x_2, ..., x_b

中间变量（白色）：
  G_1, G_2, ..., G_b  （梯度）
  W_1, W_2, ..., W_b  （中间权重）

输出变量（黄色）：
  W_b, z_1, z_2, ..., z_b
```

**关键观察：** 
- $G_1, G_2, \ldots, G_b$ 之间**没有连接**
- 因此可以并行计算！

---

### 5. 信息传播的双通道

论文揭示了mini-batch TTT的信息传播机制：

| 通道 | 描述 | 状态 |
|------|------|------|
| **cumsum通道** | $W_t = W_0 - η \sum_{s=1}^{t} G_s$ | 始终活跃 |
| **梯度通道** | 梯度相对于哪个 $W$ 计算 | 仅当来自前一个mini-batch时活跃 |

**不同GD变体的区别仅影响梯度通道，不影响cumsum通道。**

---

### 6. Mini-batch size $b$ 的权衡

论文在Figure 7展示了消融实验：

#### 困惑度 vs $b$（左图）：
- $b$ 越小 → 困惑度越低（更多GD步）
- $b = 1$（online GD）效果最好
- $b = T$（batch GD）效果最差

#### 时间 vs $b$（右图）：
- 总时间可分为两部分：
  - 计算 $W_b$：$O(T \times d^2)$，与 $b$ 无关
  - 计算 $z_1, \ldots, z_T$：$O(T \times b \times d)$

**论文的选择：** $b = 16$，平衡效果与效率。

---

### 7. 数学推导：为什么mini-batch有效？

通用的GD更新规则可写成：

$$W_t = W_{t-1} - \eta G_t = W_0 - \eta \sum_{s=1}^{t} G_s$$

**关键洞察：** 一旦计算出所有 $G_t$，可通过 **cumsum（累加）** 快速得到所有 $W_t$。

**Mini-batch的作用：** 让 $b$ 个 $G_t$ 可并行计算，然后一次性cumsum。

---

### 8. 与传统mini-batch的类比

论文指出这与标准训练的mini-batch有相似之处：

| 传统训练 | TTT |
|----------|-----|
| Mini-batch = 多个序列 | Mini-batch = 多个token |
| 并行计算序列间梯度 | 并行计算token间梯度 |
| 提高硬件利用率 | 同样提高硬件利用率 |

---

## Section 2.5: Dual Form

### 1. 问题：Mini-batch还不够高效

Mini-batch解决了并行问题，但还有一个**硬件效率问题**：

> 现代GPU/TPU（如NVIDIA A100）专门优化了**矩阵-矩阵乘法（matmul）**。
> 
> TensorCores只能执行一种操作：16×16矩阵乘法。

**朴素TTT的问题：** 即使有mini-batch，仍然缺乏足够的矩阵乘法。

---

### 2. 具体分析：为什么缺少矩阵乘法？

考虑最简单的TTT-Linear情况：
- $\theta_K = \theta_V = \theta_Q = I$（单位矩阵）
- $f(x) = Wx$（线性模型）
- 第一个mini-batch，大小为 $b$

损失函数：
$$\ell(W_0; x_t) = \|W_0 x_t - x_t\|^2$$

梯度：
$$G_t = \nabla \ell(W_0; x_t) = 2(W_0 x_t - x_t) x_t^T$$

**问题分析：**

| 操作 | 形式 | 是否可矩阵乘法批处理？ |
|------|------|------------------------|
| 计算 $W_0 x_t$ | 矩阵-向量乘 | ✓ 可批处理为 $W_0 X$ |
| 计算外积 $(\cdot) x_t^T$ | 向量-向量外积 | ✗ 需要逐个计算 |

**更糟糕的是：**
- $x_t \in \mathbb{R}^d$
- $G_t \in \mathbb{R}^{d \times d}$（远大于 $x_t$）
- 存储 $b$个 $G_t$造成严重的内存I/O负担

---

### 3. Dual Form的核心洞察

论文提出一个关键问题：

> **我们真的需要显式计算 $G_1, \ldots, G_b$吗？**

**答案：不需要！**

我们只需要两个输出：
1. $W_b$（mini-batch结束时的权重）
2. $z_1, \ldots, z_b$（输出token序列）

只要能计算这两个，中间的 $G_t$和 $W_t$可以**不显式存储**。

---

### 4. Dual Form的数学推导

设 $X = [x_1, \ldots, x_b]$，计算$W_b$：

$$W_b = W_0 - \eta \sum_{t=1}^{b} G_t = W_0 - 2\eta \sum_{t=1}^{b} (W_0 x_t - x_t) x_t^T$$

**关键变换：**
$$= W_0 - 2\eta (W_0 X - X) X^T$$

**结果：** $W_b$可以通过**纯矩阵乘法**计算！

---

### 5. 输出token的计算

计算 $Z = [z_1, \ldots, z_b]$：

$$z_t = W_t x_t = \left(W_0 - \eta \sum_{s=1}^{t} G_s\right) x_t$$

展开：
$$= W_0 x_t - 2\eta \sum_{s=1}^{t} (W_0 x_s - x_s) x_s^T x_t$$

定义 $\delta_t = \sum_{s=1}^{t} (W_0 x_s - x_s) x_s^T x_t$，$\Delta = [\delta_1, \ldots, \delta_b]$。

**Dual Form的核心公式：**
$$\Delta = (W_0 X - X) \cdot \text{mask}(X^T X)$$

其中 `mask` 是上三角掩码（类似attention mask）。

**最终：**
$$Z = W_0 X - 2\eta \Delta$$

---

### 6. Primal Form vs Dual Form对比

| 特性 | Primal Form | Dual Form |
|------|-------------|-----------|
| **显式计算** | $G_1, \ldots, G_b$和$W_1, \ldots, W_b$ | 仅计算 $W_b$和 $Z$ |
| **矩阵乘法** | 少（主要是外积） | 多（充分利用TensorCore） |
| **内存占用** | 高（存储 $d \times d$矩阵） | 低（仅存储$d$维向量） |
| **时间复杂度** | $O(b \times d^2)$ | $O(b \times d^2) + O(b^2 \times d)$ |
| **硬件效率** | 低 | 高（>5×加速） |

---

### 7. 为什么Dual Form更快？

| 分析维度 | 解释 |
|----------|------|
| **理论复杂度** | Dual略高（$O(b^2 \times d)$额外项） |
| **实际效果** | $d$通常几百， $b$仅16 → $b^2 \times d$很小 |
| **硬件利用** | TensorCore饱和运行，抵消理论开销 |
| **实验结果** | JAX实现中，Dual比Primal快**5倍以上** |

---

### 8. Figure 7右图的解读

论文展示了Dual Form的时间分解：

- **蓝色线**：计算mini-batch结束时$W_b$的时间 → $O(T \times d^2)$
- **橙色线**：总时间（包含$z_1, \ldots, z_T$）→ 额外 $O(T \times b \times d)$

**关键观察：**
- $b$增大 → 矩阵乘法并行度提高 → 蓝线下降（直到硬件饱和）
- $b$继续增大 → 计算$Z$的额外开销占主导 → 橙线上升

---

## Section 2.6: Theoretical Equivalences

### 1. TTT框架的理论统一性

论文展示了TTT框架能够**统一解释**现有的序列建模层：

| 组合 | 等价于 |
|------|--------|
| 线性模型 + Batch GD | Linear Attention |
| Nadaraya-Watson估计器（非参数化） | Self-Attention |

---

### 2. Theorem 1: TTT-Linear = Linear Attention

**定理条件：**
- $f(x) = Wx$（线性模型）
- Batch GD，$\eta = 1/2$
- $W_0 = 0$

**证明：**

根据损失 $\ell$的定义：
$$\nabla \ell(W_0; x_t) = -2(\theta_V x_t)(\theta_K x_t)^T$$

根据Batch GD：
$$W_t = W_0 - \eta \sum_{s=1}^{t} \nabla \ell(W_0; x_s) = \sum_{s=1}^{t} (\theta_V x_s)(\theta_K x_s)^T$$

代入输出规则：
$$z_t = W_t (\theta_Q x_t) = \sum_{s=1}^{t} (\theta_V x_s)(\theta_K x_s)^T (\theta_Q x_t)$$

**这正是Linear Attention的定义！**

---

### 3. Linear Attention回顾

标准Self-Attention：
$$z_t = V_t \text{softmax}(K_t^T q_t)$$

去掉softmax后：
$$z_t = V_t (K_t^T q_t) = \sum_{s=1}^{t} v_s k_s^T q_t$$

**对应关系：**

| Self-Attention | TTT参数 |
|----------------|---------|
| $v_s$ (Value) | $\theta_V x_s$ |
| $k_s$ (Key) | $\theta_K x_s$ |
| $q_t$ (Query) | $\theta_Q x_t$ |

---

### 4. Table 1: 消融实验验证

论文通过消融实验验证了理论等价性：

| 配置 | 困惑度 | 变化 |
|------|--------|------|
| Linear Attention (原始) | 15.91 | - |
| Linear Attention (改进) | 15.23 | -0.68 |
| TTT等价版本 | 15.23 | 0（验证等价） |
| + 可学习$W_0$ | 15.27 | +0.04 |
| + LN和残差 | 14.05 | -1.22 |
| + **Mini-batch TTT** | 12.35 | **-1.70（最大提升）** |
| + 可学习$\eta$ | 11.99 | -0.36 |
| + Mamba backbone | 11.09 | -0.90 |

**关键发现：**
- 从Linear Attention到TTT-Linear，最大提升来自**Mini-batch TTT**
- 这证明了TTT框架不仅仅是理论统一，还有实际优势

---

### 5. Theorem 2: TTT = Self-Attention

论文进一步展示，使用**非参数化学习者**，TTT可以等价于Self-Attention。

**Nadaraya-Watson估计器：**

$$f(x; x_1, \ldots, x_t) = \frac{\sum_{s=1}^{t} \kappa(x, x_s) y_s}{\sum_{s=1}^{t} \kappa(x, x_s)}$$

其中：
- $y_s = \theta_V x_s$（标签视角）
- $\kappa(x, x') \propto e^{(\theta_K x)^T \theta_Q x'}$（核函数）

**代入输出规则后，得到：**

$$z_t = \frac{\sum_{s=1}^{t} e^{(\theta_K x_s)^T (\theta_Q x_t)} \cdot (\theta_V x_s)}{\sum_{s=1}^{t} e^{(\theta_K x_s)^T (\theta_Q x_t)}}$$

**这正是Self-Attention的定义！**（softmax作为核）

---

### 6. 参数化 vs 非参数化学习者

论文引入了一个更一般的抽象：**学习者（Learner）**

| 类型 | 参数 | 内部存储 | 示例 |
|------|------|----------|------|
| **参数化** | $W_t$ | 模型权重 | 线性模型、MLP |
| **非参数化** | 无 | 训练数据 $x_1, \ldots, x_t$ | Nadaraya-Watson、KNN、SVM |

**统一定义：**
- 隐藏状态 = 学习者的内部存储
- 更新规则 = `train` 方法
- 输出规则 = `predict` 方法

---

### 7. Figure 8 & 9: TTT框架的分类

**Figure 8 - 参数化学习者诱导的TTT层：**

| 模型 $f$ | 优化器 | 诱导层 |
|----------|--------|--------|
| 线性模型 | Batch GD | Linear Attention |
| 线性模型 | Mini-batch GD | TTT-Linear |
| MLP | Mini-batch GD | TTT-MLP |

**Figure 9 - 序列建模层的层次结构：**

```
序列建模层
├── RNN层（固定大小隐藏状态）
│   ├── LSTM, RWKV, Mamba...
│   └── TTT层（参数化学习者）
└── TTT层（非参数化学习者）
    └── Self-Attention
```

---

### 8. 扩展能力：优化器状态也可纳入隐藏状态

论文指出一个重要扩展：

> 对于参数化学习者，内部存储不仅包含 $W$，还可以包含**优化器状态**（如Adam的动量）。

这意味着TTT框架可以支持更复杂的优化器，未来工作可以探索。

---

## 总结与核心贡献

### Section 2 各节核心贡献一览

| Section | 核心问题 | 解决方案 | 关键创新 |
|---------|----------|----------|----------|
| **2.1** | RNN隐藏状态表达能力不足 | 将隐藏状态定义为模型权重 | 压缩视角 + 自监督更新 |
| **2.3** | 自监督任务如何设计？ | 端到端学习任务参数 | 多视角重建 + 双层优化 |
| **2.4** | 更新规则如何并行？ | Mini-batch梯度下降 | 分组并行 + cumsum |
| **2.5** | 如何提高硬件效率？ | Dual Form避免显式存储梯度 | 纯矩阵乘法实现 |
| **2.6** | TTT与传统方法的关系？ | 数学证明等价性 | 统一RNN与Attention框架 |

---

### TTT框架的统一视角

```
                    序列建模层
                         │
          ┌──────────────┴──────────────┐
          │                             │
     固定大小隐藏状态              可变大小隐藏状态
          │                             │
    ┌─────┴─────┐                   Self-Attention
    │           │                        │
 传统RNN    TTT层（参数化）           等价于TTT（非参数化）
(LSTM等)    │                             │
            │                        Nadaraya-Watson
    ┌───────┴───────┐
    │               │
 TTT-Linear    TTT-MLP
 (线性模型)    (神经网络)
    │
    │ (Batch GD)
    ↓
 Linear Attention
```

---

### 关键公式汇总

| 公式名称 | 表达式 | 来源 |
|----------|--------|------|
| **输出规则** | $z_t = f(\theta_Q x_t; W_t)$ | Section 2.3 |
| **更新规则** | $W_t = W_{t-1} - \eta G_t$ | Section 2.4 |
| **自监督损失** | $\ell(W; x_t) = \|f(\theta_K x_t; W) - \theta_V x_t\|^2$ | Section 2.3 |
| **Dual Form W_b** | $W_b = W_0 - 2\eta(W_0 X - X) X^T$ | Section 2.5 |
| **Dual Form Z** | $Z = W_0 X - 2\eta \Delta$ | Section 2.5 |

---

### 论文的核心论点

1. **表达能力的突破**：隐藏状态从"固定向量"升级为"可训练模型"
2. **效率的保持**：通过mini-batch + dual form实现硬件高效
3. **理论的统一**：TTT框架能统一解释Linear Attention和Self-Attention
4. **实践的验证**：长文本任务上显著超越Mamba等现代RNN

---

> **本文档基于TTT论文 arXiv:2407.04620 的 Section 2 内容整理**
> 
> 整理时间: 2026-04-13
