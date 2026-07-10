# 四种 Post-Training 算法的数学基础

本文档从纯数学公式的角度解释 ASP 和 LoRA 四种协议背后的算法原理。不涉及代码，只关注**目标函数、优化过程和参数更新规则**。

---

## 一、后训练的通用数学框架

### 1.1 问题设定

给定一个已预训练的语言模型，参数为 $\boldsymbol{\theta}_0 \in \mathbb{R}^D$（对于 7B 模型，$D \approx 7 \times 10^9$）。后训练的目标是在任务数据集 $\mathcal{D} = \{(x_i, y_i)\}_{i=1}^{N}$ 上找到更新后的参数 $\boldsymbol{\theta}^*$，最小化经验风险。

### 1.2 语言模型的训练损失

对于自回归语言模型，训练损失是**交叉熵**：

$$\mathcal{L}_{\text{CE}}(\boldsymbol{\theta}) = -\frac{1}{N}\sum_{i=1}^{N}\sum_{t=1}^{T} \log P_{\boldsymbol{\theta}}(x_{i,t} \mid x_{i,<t})$$

等价于：

$$\mathcal{L}_{\text{CE}}(\boldsymbol{\theta}) = -\frac{1}{N}\sum_{i=1}^{N}\sum_{t=1}^{T} \log \frac{\exp(z_{t}[\text{true\_token}])}{\sum_{v=1}^{V}\exp(z_{t}[v])}$$

其中 $z_t \in \mathbb{R}^{V}$ 是模型在位置 $t$ 的输出 logits（$V \approx 50,000$ 是词表大小）。

### 1.3 后训练优化的通用形式

所有后训练算法都可以表示为：

$$\boldsymbol{\theta}^* = \arg\min_{\boldsymbol{\theta} \in \Theta} \mathcal{L}_{\text{CE}}(\boldsymbol{\theta}) + \mathcal{R}(\boldsymbol{\theta})$$

其中：
- $\Theta$ 是允许的参数空间（全秩 $\Theta = \mathbb{R}^D$，或 LoRA 约束子空间 $\Theta_{\text{LoRA}} \subset \mathbb{R}^D$）
- $\mathcal{R}(\boldsymbol{\theta})$ 是正则化项（如权重衰减 $\lambda\|\boldsymbol{\theta}\|_2^2$）

四种 Protocol 的区别就在于：**如何使用不同的空间 $\Theta$** 和**如何求解这个最优化问题**。

---

## 二、Protocol B：AdamW 在全参数空间的标准优化

### 2.1 问题形式

$$\boldsymbol{\theta}^* = \arg\min_{\boldsymbol{\theta} \in \mathbb{R}^D} \;\; \mathcal{L}_{\text{CE}}(\boldsymbol{\theta}) + \frac{\lambda}{2}\|\boldsymbol{\theta}\|_2^2$$

参数空间无约束，所有 $D$ 个参数都可以自由调整。

### 2.2 AdamW 更新规则

AdamW 维护两组动量统计量，每步进行以下更新（以下省略下标的迭代序号 $t$，每个参数 $\theta_j$ 独立执行相同的操作）：

**第一步：计算当前 mini-batch 的梯度**

$$g_t = \nabla_{\boldsymbol{\theta}}\mathcal{L}_{\text{CE}}(\boldsymbol{\theta}_t)$$

**第二步：更新一阶矩（指数移动平均梯度）**

$$m_t = \beta_1 \cdot m_{t-1} + (1 - \beta_1) \cdot g_t$$

其中 $\beta_1 = 0.9$ 是衰减系数。$m_t$ 是梯度方向的"惯性"。

**第三步：更新二阶矩（指数移动平均梯度平方）**

$$v_t = \beta_2 \cdot v_{t-1} + (1 - \beta_2) \cdot g_t^2$$

其中 $\beta_2 = 0.999$。$v_t$ 是梯度大小的"度量"。

**第四步：偏差校正**

$$\hat{m}_t = \frac{m_t}{1 - \beta_1^t}, \quad \hat{v}_t = \frac{v_t}{1 - \beta_2^t}$$

由于 $m_0 = v_0 = 0$，前几步的估计偏低，需要校正。

**第五步：参数更新（含权重衰减）**

$$\boldsymbol{\theta}_{t+1} = \boldsymbol{\theta}_t - \eta \cdot \left(\frac{\hat{m}_t}{\sqrt{\hat{v}_t} + \epsilon} + \lambda \cdot \boldsymbol{\theta}_t\right)$$

其中：
- $\eta = 10^{-4}$ 是学习率
- $\lambda = 10^{-2}$ 是权重衰减系数
- $\epsilon = 10^{-8}$ 防止除零

### 2.3 AdamW 解决了什么问题？

标准 SGD 的更新是 $\boldsymbol{\theta}_{t+1} = \boldsymbol{\theta}_t - \eta \cdot g_t$，有两个缺陷：

1. **学习率对所有参数一视同仁**：有些参数需要大步，有些需要小步，SGD 无法自适应。
2. **容易陷入窄的局部最优**：没有动量，容易被"卡住"。

AdamW 通过 $m_t$（历史梯度方向）提供动量，通过 $v_t$（历史梯度大小）自适应调整每个参数的学习率。这就像一个经验丰富的登山者，知道什么时候该加速、什么时候该减速。

### 2.4 Protocol B 的完整数学描述

$$\boxed{
\begin{aligned}
& \text{输入: } \boldsymbol{\theta}_0 \text{ (预训练参数)}, \mathcal{D} \text{ (训练数据)}, \eta, \lambda, \beta_1, \beta_2 \\
& \text{for } t = 0, 1, \ldots, T-1: \\
& \qquad g_t = \nabla_{\boldsymbol{\theta}}\mathcal{L}_{\text{CE}}(\boldsymbol{\theta}_t) \quad \text{(在 mini-batch 上)} \\
& \qquad m_t = \beta_1 m_{t-1} + (1 - \beta_1) g_t \\
& \qquad v_t = \beta_2 v_{t-1} + (1 - \beta_2) g_t^2 \\
& \qquad \hat{m}_t = m_t / (1 - \beta_1^{t+1}), \quad \hat{v}_t = v_t / (1 - \beta_2^{t+1}) \\
& \qquad \boldsymbol{\theta}_{t+1} = \boldsymbol{\theta}_t - \eta \cdot (\hat{m}_t / (\sqrt{\hat{v}_t} + \epsilon) + \lambda \cdot \boldsymbol{\theta}_t) \\
& \text{输出: } \boldsymbol{\theta}_T
\end{aligned}}
$$

---

## 三、Protocol D：AdamW 在 LoRA 约束子空间

### 3.1 LoRA 的参数约束

Protocol D 与 Protocol B 的唯一区别在于**参数空间被约束了**。对于 Transformer 的每一层，原始的权重矩阵 $W_0 \in \mathbb{R}^{d_{\text{out}} \times d_{\text{in}}}$ 被**冻结**（不再更新），训练时只调整两个低秩矩阵：

$$\Delta W = \frac{\alpha}{r} \cdot B A$$

其中：
- $A \in \mathbb{R}^{r \times d_{\text{in}}}$（秩-维度映射矩阵）
- $B \in \mathbb{R}^{d_{\text{out}} \times r}$（维度-秩映射矩阵）
- $r \ll \min(d_{\text{out}}, d_{\text{in}})$，通常 $r = 8$
- $\alpha$ 是缩放因子，通常 $\alpha = 2r$

对于模型的 4 个注意力模块 (Q, K, V, O)，每层可训练的参数总数是：

$$N_{\text{trainable}} = 4 \times 2 \times r \times d_{\text{model}}$$

对于 Qwen2.5-0.5B（$d_{\text{model}} = 896$, $r = 8$, $L = 24$）：

$$N_{\text{trainable}} = 4 \times 2 \times 8 \times 896 \times 24 \approx 1.1 \times 10^6$$

而完整模型有 $494 \times 10^6$ 个参数——LoRA 只训练了其中的 $\approx 0.22\%$。

### 3.2 前向传播的数学形式

对于输入 $x \in \mathbb{R}^{d_{\text{in}}}$：

$$h = W_0 \cdot x + \underbrace{\frac{\alpha}{r} \cdot B \cdot A \cdot x}_{\text{LoRA 修正（可训练）}}$$

或者写成：

$$h = (W_0 + \frac{\alpha}{r}BA) \cdot x \triangleq W_{\text{eff}} \cdot x$$

有趣的是：$W_{\text{eff}}$ 是一个全秩矩阵（$W_0$ 是全秩的），但它的**变化量** $\Delta W = W_{\text{eff}} - W_0$ 被限制为秩至多为 $r$。

### 3.3 Protocol D 的优化问题

$$\min_{A, B} \;\; \mathcal{L}_{\text{CE}}(W_0 + \frac{\alpha}{r}BA) + \frac{\lambda}{2}(\|A\|_F^2 + \|B\|_F^2)$$

梯度只对 $A$ 和 $B$ 计算：

$$\nabla_{A} \mathcal{L} = \frac{\alpha}{r} \cdot B^T \cdot \nabla_{h} \mathcal{L} \cdot x^T$$

$$\nabla_{B} \mathcal{L} = \frac{\alpha}{r} \cdot \nabla_{h} \mathcal{L} \cdot x^T \cdot A^T$$

其中 $\nabla_h \mathcal{L} \in \mathbb{R}^{d_{\text{out}}}$ 是从输出端反传回来的梯度。

### 3.4 为什么 LoRA 有效？——数学直觉

**定理直觉**（Aghajanyan et al., 2021）：预训练语言模型的内禀维度 $d_{\text{int}}$ 远小于参数空间的维度 $D$。后训练只需要在 $d_{\text{int}} \approx 10^3$ 维的"任务子空间"中进行调整。

LoRA 将更新限制在 $r \times d_{\text{head}} \approx 8 \times 64 = 512$ 维的子空间中。对于 WikiText-2 后训练任务，这个维度**恰好足够**——这就是为什么 $r=8$ 在所有架构上都达到了平坦区。

### 3.5 Protocol D 的完整数学描述

$$\boxed{
\begin{aligned}
& \text{输入: } \{W_0^{(l)}\}_{l=1}^{L} \text{ (冻结的预训练权重)}, \mathcal{D}, \eta, \lambda, r, \alpha \\
& \text{初始化: } A^{(l)} \sim \mathcal{N}(0, \sigma^2), \quad B^{(l)} = 0 \quad \forall l \in \{1,\ldots,L\} \\
& \text{for } t = 0, 1, \ldots, T-1: \\
& \qquad \text{前向传播: } h^{(l)} = (W_0^{(l)} + \frac{\alpha}{r}B^{(l)}A^{(l)}) \cdot h^{(l-1)} \quad \forall l \\
& \qquad \mathcal{L}_t = \mathcal{L}_{\text{CE}}(h^{(L)}) \\
& \qquad g_t^{(A,l)} = \nabla_{A^{(l)}} \mathcal{L}_t, \quad g_t^{(B,l)} = \nabla_{B^{(l)}} \mathcal{L}_t \\
& \qquad \text{AdamW 更新 } A^{(l)}, B^{(l)} \text{ (同 Protocol B)} \\
& \text{输出: } \{W_0^{(l)} + \frac{\alpha}{r}B^{(l)}A^{(l)}\}_{l=1}^{L}
\end{aligned}}
$$

---

## 四、Protocol A：ASP 三阶段交替优化

Protocol A 的核心思想是：**不同时间用不同的优化目标，交替执行**。

### 4.1 Phase I：ALS（交替最小二乘）

**目标函数**：对于模型中的某一层（例如 lm_head 输出层），固定其他所有层，求解该层的最优权重矩阵：

$$W_{\text{new}} = \arg\min_{W} \|X W^T - Y_{\text{target}}\|_F^2 + \lambda \|W\|_F^2$$

其中：
- $X \in \mathbb{R}^{N \times d_{\text{in}}}$ 是该层在 N 个 token 上的输入激活值
- $Y_{\text{target}} \in \mathbb{R}^{N \times d_{\text{out}}}$ 是目标输出（由标签决定）
- $\lambda = 10^{-4}$ 是正则化系数

**闭式解**：这是一个标准的岭回归问题，存在解析解：

$$\boxed{W_{\text{new}}^T = (X^T X + \lambda I)^{-1} X^T Y_{\text{target}}}$$

**计算流程**：由于 $d_{\text{out}}$ 可能很大（例如 lm_head 的 $d_{\text{out}} = 151936$），将输出维度分块求解。将 $W$ 的行分成 $b=1024$ 的小块，每块独立求解：

$$\boxed{W_{\text{block}}^T = (X^T X + \lambda I)^{-1} X^T Y_{\text{block}}}$$

每块的矩阵求逆复杂度是 $\mathcal{O}(d_{\text{in}}^3)$，但只需计算一次 $(X^T X + \lambda I)^{-1}$，对所有块复用。

**数值方法**：使用 Cholesky 分解求解 $(X^T X + \lambda I)^{-1} X^T Y_{\text{block}}$。由于 $X^T X + \lambda I$ 是正定矩阵（任意 $X$ 加上正则项 $\lambda I$），Cholesky 分解总是存在且唯一：

$$X^T X + \lambda I = L L^T$$

其中 $L$ 是下三角矩阵。然后通过两次三角求解得到结果，无需显式计算逆矩阵。

**ALS 的意义**：给定当前层的输入，闭式求出最优权重。这是一次到达全局最优——不像梯度下降需要迭代。但代价是 $\mathcal{O}(d_{\text{in}}^3)$ 的计算量。

### 4.2 Phase II：SGD（随机梯度下降）

**目标函数**：回到标准的交叉熵损失，但使用 SGD（而非 AdamW）优化：

$$\boldsymbol{\theta}_{t+1} = \boldsymbol{\theta}_t - \eta \cdot \nabla_{\boldsymbol{\theta}}\mathcal{L}_{\text{CE}}(\boldsymbol{\theta}_t)$$

带动量版本：

$$v_{t+1} = \beta \cdot v_t + \eta \cdot \nabla_{\boldsymbol{\theta}}\mathcal{L}_{\text{CE}}(\boldsymbol{\theta}_t)$$

$$\boldsymbol{\theta}_{t+1} = \boldsymbol{\theta}_t - v_{t+1} - \eta\lambda \cdot \boldsymbol{\theta}_t$$

其中 $\beta = 0.9$ 是动量系数。

**为什么 ALS 之后需要 SGD？** ALS 只优化了某一层（在我们的实现中是 lm_head），忽视了层间的相互依赖。当 lm_head 的参数改变后，所有前一层输出的"含义"也随之改变——但前一层还不知道。SGD 的作用是**让所有层协调一致**。50 步 SGD 提供了约 125-250 步的有效"消化时间"（取决于层数），让整个模型的参数适应 ALS 带来的变化。

### 4.3 Phase III：Perturbation（随机扰动）

**目标**：在参数空间注入受控噪声，帮助优化器逃离窄的局部最优。

$$\boldsymbol{\theta} \leftarrow \boldsymbol{\theta} + \varepsilon, \quad \varepsilon \sim \mathcal{N}(0, \sigma^2 I)$$

噪声的尺度随时间衰减（余弦退火）：

$$\sigma_t = \sigma_0 \cdot \frac{1}{2}\left(1 + \cos\frac{\pi t}{T}\right)$$

其中 $\sigma_0 = 10^{-3}$（全秩）或 $5 \times 10^{-4}$（LoRA），$T$ 是总周期数。

**数学直觉——为什么扰动有助于优化？**

考虑一个简化的损失地形：$\mathcal{L}(\theta) = \theta^4 - 3\theta^2 + \theta$。这个函数有两个局部最优（在 $\theta \approx \pm 1.2$ 附近），和一个全局最优（在 $\theta \approx -1.5$ 附近）。标准 SGD 很容易被困在第一个遇到的局部最优中。

加上扰动后，优化过程变成：

$$\theta_{t+1} = \theta_t - \eta\nabla\mathcal{L}(\theta_t) + \sigma_t \cdot \varepsilon_t$$

当 $\sigma_t$ 足够大时，$\theta$ 有概率从一个局部最优"跳到"附近更优的区域。这类似于模拟退火 (simulated annealing) 或随机梯度 Langevin 动力学 (SGLD)。

**连接 SAM (Sharpness-Aware Minimization)**：Foret et al. (2021) 证明了在参数空间的"平坦"区域泛化更好。ASP 的扰动阶段显式地鼓励探索更平坦的最优解——扰动强迫参数离开窄的极小值，只有足够宽的盆地才能"幸存"。

### 4.4 Protocol A 的三阶段统一形式

$$\boxed{
\begin{aligned}
& \text{输入: } \boldsymbol{\theta}_0, \mathcal{D}, \eta, \lambda, C \text{ (周期数)}, K \text{ (每周期 SGD 步数)} \\
& \text{for } c = 1, 2, \ldots, C: \\
& \qquad \text{① ALS: } \boldsymbol{\theta} \leftarrow \arg\min_{\boldsymbol{\theta}_{\text{head}}} \|X\boldsymbol{\theta}_{\text{head}}^T - Y\|_F^2 \quad \text{(只改输出层)} \\
& \qquad \text{② SGD: for } k = 1, \ldots, K: \\
& \qquad \qquad \boldsymbol{\theta} \leftarrow \boldsymbol{\theta} - \eta \nabla_{\boldsymbol{\theta}}\mathcal{L}_{\text{CE}}(\boldsymbol{\theta}) \quad \text{(改所有层)} \\
& \qquad \text{③ Perturb: } \boldsymbol{\theta} \leftarrow \boldsymbol{\theta} + \sigma_c \cdot \boldsymbol{\varepsilon}, \quad \boldsymbol{\varepsilon} \sim \mathcal{N}(0, I) \\
& \text{输出: } \boldsymbol{\theta}_T
\end{aligned}}
$$

---

## 五、Protocol C：ASP 在 LoRA 约束子空间（不含 ALS）

### 5.1 当前实现的数学描述

Protocol C 的 LoRA 参数化和 Protocol D 完全相同，但使用 SGD+Perturb 交替（不含 ALS 相位）：

$$\boxed{
\begin{aligned}
& \text{for } c = 1, 2, \ldots, C: \\
& \qquad \text{① SGD: for } k = 1, \ldots, K: \\
& \qquad \qquad A \leftarrow A - \eta \nabla_A \mathcal{L}_{\text{CE}}(W_0 + \frac{\alpha}{r}BA) \\
& \qquad \qquad B \leftarrow B - \eta \nabla_B \mathcal{L}_{\text{CE}}(W_0 + \frac{\alpha}{r}BA) \\
& \qquad \text{② Perturb: } A \leftarrow A + \sigma_c \cdot \varepsilon_A, \quad B \leftarrow B + \sigma_c \cdot \varepsilon_B
\end{aligned}}
$$

### 5.2 为什么 ALS 缺失？

ALS 求解器假设直接读写 `nn.Linear.weight.data`（一个 $d_{\text{out}} \times d_{\text{in}}$ 的矩阵）。但在 LoRA 参数化下，有效权重是 $W_{\text{eff}} = W_0 + \frac{\alpha}{r}BA$，其中 $W_0$ 是冻结的。

ALS 解出来的满秩 $\Delta W$ 无法直接写回低秩的 $A$ 和 $B$ 矩阵。这需要一个**投影步骤**——这正是 X1 扩展实现的内容。

### 5.3 X1 扩展：低秩 ALS 投影（2026-06-23 实现）

对于 LoRA 参数化的层，有效权重为 $W_{\text{eff}} = W_0 + \frac{\alpha}{r}BA$。ALS 在满秩空间求解后得到 $W_{\text{new}}$。定义差异 $\Delta W = W_{\text{new}} - W_{\text{eff}}$。

需要将 $\Delta W$ 投影回 LoRA 的 $B$ 矩阵。投影公式：

$$\boxed{\Delta B = \Delta W \cdot A^T \cdot (AA^T + \lambda I)^{-1} / \alpha}$$

推导过程：

1. 我们希望找到 $\Delta B$ 使得 $(B + \Delta B)A \approx (B + \frac{\alpha}{r}\Delta W)A$
2. 即 $\Delta B \cdot A = \Delta W$（忽略比例因子）
3. 这是一个欠定线性系统（$\Delta B \in \mathbb{R}^{b \times r}$, $A \in \mathbb{R}^{r \times d_{\text{in}}}$, $b \ll d_{\text{in}}$）
4. 最小范数解：$\Delta B = \Delta W \cdot A^T \cdot (AA^T + \lambda I)^{-1}$
5. 加上 LoRA 的缩放因子：$\Delta B = \Delta W \cdot A^T \cdot (AA^T + \lambda I)^{-1} / \alpha$

更新方式：

$$B_{\text{new}}[i:i+b, :] = B_{\text{old}}[i:i+b, :] + \Delta B$$

---

## 六、深度边界：ALS 扰动放大的数学模型

### 6.1 残差连接中的扰动传播

Transformer 的残差连接定义为：

$$h_{l+1} = h_l + f_l(h_l; \theta_l)$$

当 ALS 在第 $l$ 层进行干预后，该层的输出从 $h_l$ 变为 $h_l^{\text{ALS}}$。定义扰动偏差 $\delta_l = h_l^{\text{ALS}} - h_l$。

对于下游层 $k > l$，扰动的传播满足（一阶 Taylor 近似）：

$$\delta_{k+1} \approx (I + J_{f_k}) \cdot \delta_k$$

其中 $J_{f_k} = \frac{\partial f_k}{\partial h_k}$ 是第 $k$ 层函数关于其输入的 Jacobian 矩阵。

### 6.2 累积放大

迭代上述关系，ALS 干预在第 $L$ 层的最终影响为：

$$\boxed{\|\delta_L\| \approx \|\delta_l\| \cdot \prod_{k=l}^{L-1} \|I + J_{f_k}\|}$$

定义 $\bar{\rho}$ 为 $\|I + J_{f_k}\|$ 跨层的几何平均值：

$$\|\delta_L\| \approx \|\delta_l\| \cdot \bar{\rho}^{\,L-l}$$

经验估计 $\bar{\rho} \approx 1.08$（从 OPT-125m 和 Qwen2.5-0.5B 的消化时间拟合得到）。

### 6.3 深度边界条件

SGD 在 $T_{\text{SGD}}$ 步内的有效恢复容量为：

$$C_{\text{recovery}} = \eta \cdot \mu_{\min} \cdot T_{\text{SGD}}$$

其中 $\mu_{\min}$ 是恢复期间的最小梯度范数，$\eta_{\text{eff}}$ 是有效学习率。

当累积扰动超过 SGD 的恢复容量时，深度边界被触发：

$$\|\delta_L\| > C_{\text{recovery}}$$

代

入扰动传播模型：

$$\boxed{L_{\max} = \frac{\ln(\eta \mu_{\min} T_{\text{SGD}} / A_{\text{eff}})}{\ln \bar{\rho}} \approx 26}$$

这个值与实证边界（$\leq 24$ 层收敛，$\geq 28$ 层发散）一致。唯一自由参数 $\bar{\rho} \approx 1.08$ 由两个模型的数据拟合——$\bar{\rho}$ 独立于模型架构这一事实本身就是对理论的有力验证。

---

## 七、FLOPs 公平比较的数学基础

### 7.1 各操作的 FLOPs 计数

| 操作 | 浮点运算次数 | 说明 |
|------|------------|------|
| 前向传播 (一次) | $2 \cdot N_{\text{params}}$ | 每个参数乘加各一次 |
| 反向传播 (一次) | $4 \cdot N_{\text{params}}$ | 前向的约两倍 |
| SGD 参数更新 | $N_{\text{params}}$ | 简单的加减 |
| AdamW 参数更新 | $3 \cdot N_{\text{params}}$ | 需要维护两个动量 |
| ALS (每块) | $N \cdot d_{\text{in}}^2 + d_{\text{in}}^3$ | 形成 $X^TX$ + Cholesky |
| 扰动 | $N_{\text{params}}$ | 加噪声 |

### 7.2 公平比较协议

$$\text{所有 Protocol 运行至 } \sum_{t=1}^{T} \text{FLOPs}_t \geq \text{BUDGET}$$

**不是按步数比较，而是按总计算量比较**。这是公平比较的核心原则。

### 7.3 具体算例

对于 Qwen2.5-0.5B（$N_{\text{params}} = 4.94 \times 10^8$，$d_{\text{in}} = 896$，$N = 800$ 样本）：

| 操作 | FLOPs |
|------|-------|
| Protocol D 一步（LoRA, AdamW） | $2 + 4 + 3 \times \frac{1.1 \times 10^6}{4.94 \times 10^8} \cdot 4.94 \times 10^8 \approx 3.0 \times 10^9$ |
| Protocol B 一步（全秩, AdamW） | $(2 + 4 + 3) \times 4.94 \times 10^8 = 4.4 \times 10^9$ |
| Protocol A 一步均值（ASP） | $\approx 1.2 \times 10^{10}$ / 循环（含 ALS 摊销） |

**因此**：Protocol D 可以在**相同 FLOPs 预算下运行更多步**，弥补每步更新更少参数的劣势。

---

## 八、核心公式速查表

| 公式 | 名称 | 所属 Protocol |
|------|------|-------------|
| $\mathcal{L}_{\text{CE}} = -\frac{1}{N}\sum_{i,t}\log P_{\theta}(x_{i,t}\mid x_{i,<t})$ | 交叉熵损失 | 所有 |
| $\boldsymbol{\theta}_{t+1} = \boldsymbol{\theta}_t - \eta(\hat{m}_t/(\sqrt{\hat{v}_t}+\epsilon) + \lambda\boldsymbol{\theta}_t)$ | AdamW 更新 | B, D |
| $\Delta W = \frac{\alpha}{r}BA$ | LoRA 参数化 | C, D |
| $W_{\text{new}}^T = (X^TX + \lambda I)^{-1}X^TY$ | ALS 闭式解 | A |
| $\Delta B = \Delta W \cdot A^T(AA^T + \lambda I)^{-1}/\alpha$ | 低秩 ALS 投影 | C (X1) |
| $\boldsymbol{\theta} \leftarrow \boldsymbol{\theta} + \sigma\boldsymbol{\varepsilon}$ | 扰动阶段 | A, C |
| $\|\delta_L\| \approx \|\delta_l\| \cdot \bar{\rho}^{\,L-l}$ | 深度边界传播 | A (理论) |
| $\text{PPL} = e^{\mathcal{L}_{\text{CE}}}$ | 困惑度 | 评估 |
| $M = \text{PPL}_{\text{train}}/\text{PPL}_{\text{cross}}$ | M-index | 评估 |
| $r_{\min} = \eta \cdot L/d_h$ | 秩充足律 | 理论 |
