---
layout: default
title: MM-LMPC: Multi-Modal Learning Model Predictive Control via Bandit-Based Mode Selection
---

# MM-LMPC: Multi-Modal Learning Model Predictive Control via Bandit-Based Mode Selection

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2510.00410" class="toolbar-btn" target="_blank">📄 arXiv: 2510.00410v1</a>
  <a href="https://arxiv.org/pdf/2510.00410.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2510.00410v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2510.00410v1', 'MM-LMPC: Multi-Modal Learning Model Predictive Control via Bandit-Based Mode Selection')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Wataru Hashimoto, Kazumune Hashimoto

**分类**: eess.SY

**发布日期**: 2025-10-01

**备注**: This paper is submitted to 2026 American Control Conference (ACC)

---

## 💡 一句话要点

**提出基于Bandit模式选择的多模态学习模型预测控制(MM-LMPC)，解决LMPC探索不足问题。**

🎯 **匹配领域**: **支柱一：机器人控制 (Robot Control)**

**关键词**: `模型预测控制` `迭代学习` `多模态学习` `Bandit算法` `机器人控制`

## 📋 核心要点

1. 传统LMPC依赖初始轨迹，易陷入局部最优，导致状态空间探索不足。
2. MM-LMPC将轨迹聚类为多个模式，维护模式特定的终端集和价值函数。
3. 采用基于Bandit的元控制器平衡模式探索与利用，提升全局寻优能力。

## 📝 摘要（中文）

学习模型预测控制(LMPC)通过利用先前执行的数据来提高迭代任务的性能。在每次迭代中，LMPC从过去的轨迹构建一个采样的安全集，并将其用作终端约束，终端代价由相应的cost-to-go给出。虽然有效，但LMPC严重依赖于初始轨迹：具有高cost-to-go的状态很少被选择为后期迭代中的终端候选，导致部分状态空间未被探索，并可能错过更好的解决方案。例如，在具有两条可能路径的reach-avoid任务中，LMPC可能不断改进最初较短的路径，而忽略了可能导致全局更好解决方案的替代路径。为了克服这个限制，我们提出了多模态LMPC(MM-LMPC)，它将过去的轨迹聚类成模式，并维护特定于模式的终端集和价值函数。一个基于Bandit的元控制器，采用下置信界(LCB)策略，平衡了跨模式的探索和利用，从而能够系统地改进所有模式。这使得MM-LMPC能够逃脱高代价的局部最优解，并发现全局更优的解决方案。我们建立了递归可行性、闭环稳定性、渐近收敛到最佳模式以及对数后悔界。在避障任务上的仿真验证了所提出方法的性能改进。

## 🔬 方法详解

**问题定义**：LMPC在迭代学习控制中表现出色，但其性能高度依赖于初始轨迹。如果初始轨迹质量不高，LMPC容易陷入局部最优，无法充分探索状态空间，从而错失全局最优解。例如，在存在多条可行路径的任务中，LMPC可能过度优化初始选择的路径，而忽略了其他潜在的更优路径。

**核心思路**：MM-LMPC的核心思想是将过去的轨迹数据聚类成多个不同的“模式”，每个模式代表一种不同的行为策略或解决方案。通过维护每个模式特定的终端集和价值函数，MM-LMPC能够同时探索多个潜在的解决方案，避免过早地收敛到局部最优。

**技术框架**：MM-LMPC的整体框架包含以下几个主要模块：1) 轨迹聚类：使用聚类算法（如k-means）将历史轨迹数据划分成多个模式。2) 模式特定的终端集和价值函数：为每个模式维护一个终端集，该集合包含该模式下表现良好的状态。同时，为每个模式学习一个价值函数，用于评估该模式下状态的优劣。3) 基于Bandit的元控制器：使用Bandit算法（如UCB或LCB）来选择在当前迭代中应该探索哪个模式。元控制器根据每个模式的性能和探索程度，平衡探索和利用，从而系统地改进所有模式。4) 模型预测控制：基于选定的模式，使用模型预测控制生成控制序列。

**关键创新**：MM-LMPC的关键创新在于引入了基于Bandit的元控制器来管理多个模式的探索和利用。与传统的LMPC只关注单一轨迹不同，MM-LMPC能够同时探索多个潜在的解决方案，从而避免陷入局部最优。此外，基于Bandit的元控制器能够自适应地调整每个模式的探索概率，从而更有效地利用历史数据。

**关键设计**：MM-LMPC的关键设计包括：1) 使用k-means算法进行轨迹聚类，需要选择合适的k值。2) 使用下置信界(LCB)策略作为Bandit算法，平衡探索和利用。LCB策略根据每个模式的平均奖励和探索次数，计算一个下置信界，并选择具有最低下置信界的模式进行探索。3) 终端集的构建方式，例如，可以选择cost-to-go低于某个阈值的状态作为终端集。4) 价值函数的学习方法，例如，可以使用神经网络来近似价值函数。

## 📊 实验亮点

在避障任务的仿真实验中，MM-LMPC能够有效地探索不同的路径，并找到比传统LMPC更优的解决方案。实验结果表明，MM-LMPC能够更快地收敛到最优解，并具有更好的鲁棒性。论文还提供了递归可行性、闭环稳定性、渐近收敛到最佳模式以及对数后悔界的理论证明。

## 🎯 应用场景

MM-LMPC适用于需要迭代学习和优化的机器人控制任务，例如复杂环境下的路径规划、避障、抓取等。该方法可以应用于自动驾驶、工业机器人、服务机器人等领域，提高机器人的自主性和适应性，降低人工干预的需求。未来，可以将MM-LMPC与其他学习算法（如强化学习）相结合，进一步提升其性能和泛化能力。

## 📄 摘要（原文）

> Learning Model Predictive Control (LMPC) improves performance on iterative tasks by leveraging data from previous executions. At each iteration, LMPC constructs a sampled safe set from past trajectories and uses it as a terminal constraint, with a terminal cost given by the corresponding cost-to-go. While effective, LMPC heavily depends on the initial trajectories: states with high cost-to-go are rarely selected as terminal candidates in later iterations, leaving parts of the state space unexplored and potentially missing better solutions. For example, in a reach-avoid task with two possible routes, LMPC may keep refining the initially shorter path while neglecting the alternative path that could lead to a globally better solution. To overcome this limitation, we propose Multi-Modal LMPC (MM-LMPC), which clusters past trajectories into modes and maintains mode-specific terminal sets and value functions. A bandit-based meta-controller with a Lower Confidence Bound (LCB) policy balances exploration and exploitation across modes, enabling systematic refinement of all modes. This allows MM-LMPC to escape high-cost local optima and discover globally superior solutions. We establish recursive feasibility, closed-loop stability, asymptotic convergence to the best mode, and a logarithmic regret bound. Simulations on obstacle-avoidance tasks validate the performance improvements of the proposed method.

