---
layout: default
title: From Demonstrations to Safe Deployment: Path-Consistent Safety Filtering for Diffusion Policies
---

# From Demonstrations to Safe Deployment: Path-Consistent Safety Filtering for Diffusion Policies

<div class="paper-toolbar">
  <div class="toolbar-left">
    <a href="https://arxiv.org/abs/2511.06385" target="_blank" class="toolbar-btn">arXiv: 2511.06385v1</a>
    <a href="https://arxiv.org/pdf/2511.06385.pdf" target="_blank" class="toolbar-btn">PDF</a>
  </div>
  <div class="toolbar-right">
    <button class="toolbar-btn favorite-btn" data-arxiv-id="2511.06385v1" 
            onclick="toggleFavorite(this, '2511.06385v1', 'From Demonstrations to Safe Deployment: Path-Consistent Safety Filtering for Diffusion Policies')" title="收藏">
      ☆ 收藏
    </button>
    <button class="toolbar-btn share-btn" onclick="copyLink()" title="复制链接">
      🔗 分享
    </button>
  </div>
</div>


**作者**: Ralf Römer, Julian Balletshofer, Jakob Thumm, Marco Pavone, Angela P. Schoellig, Matthias Althoff

**分类**: cs.RO, eess.SY

**发布日期**: 2025-11-09

**备注**: Project page: https://tum-lsy.github.io/pacs/. 8 pages, 4 figures

**🔗 代码/项目**: [PROJECT_PAGE](https://tum-lsy.github.io/pacs/)

---

## 💡 一句话要点

**提出路径一致性安全过滤(PACS)方法，保障Diffusion策略在人机交互中的安全部署。**

🎯 **匹配领域**: **支柱一：机器人控制 (Robot Control)**

**关键词**: `Diffusion策略` `安全过滤` `路径一致性` `人机交互` `可达性分析`

## 📋 核心要点

1. Diffusion策略在复杂任务中表现出色，但缺乏安全性保障，直接部署风险高。
2. PACS通过路径一致性制动，确保策略执行与训练分布一致，维持任务完成能力。
3. 实验表明，PACS在动态环境中提供安全保证，并显著优于传统安全方法。

## 📝 摘要（中文）

Diffusion策略(DPs)通过学习大规模演示数据集，在复杂操作任务上实现了最先进的性能，这些数据集通常跨越多个实体和环境。然而，它们无法保证安全行为，因此需要外部安全机制。然而，这些机制以训练期间未见过的方式改变动作，导致不可预测的行为和性能下降。为了解决这些问题，我们为DPs提出了一种路径一致性安全过滤(PACS)。我们的方法对从生成的动作序列计算出的轨迹执行路径一致的制动。通过这种方式，我们保持执行与策略的训练分布一致，从而保持学习到的、完成任务的行为。为了实现实时部署并处理不确定性，我们使用基于集合的可达性分析来验证安全性。我们在模拟和三个具有挑战性的真实世界人机交互任务中的实验评估表明，PACS (a)在动态环境中提供形式安全保证，(b)保持任务成功率，以及(c)在任务成功率方面优于反应式安全方法，如控制障碍函数，高达68%。

## 🔬 方法详解

**问题定义**：Diffusion策略在复杂操作任务中表现出色，但其生成的动作序列无法保证安全性，直接部署可能导致危险行为。现有的安全机制，如控制障碍函数，通常以反应式的方式修改动作，这会改变策略的执行轨迹，使其偏离训练分布，导致性能下降和行为不可预测。因此，如何在保证安全性的同时，维持Diffusion策略的性能和行为一致性是一个关键问题。

**核心思路**：论文的核心思路是提出路径一致性安全过滤（PACS）。PACS不是直接修改策略生成的动作，而是对整个轨迹进行分析，并在必要时进行“制动”，即减速或停止，以确保轨迹保持在安全范围内。这种方法保持了策略的原始行为模式，避免了因动作突变而导致的性能下降。核心在于保证修改后的轨迹仍然“看起来像”策略在训练时可能产生的轨迹。

**技术框架**：PACS的整体框架包括以下几个主要阶段：1) Diffusion策略生成初始动作序列；2) 基于动作序列计算预测轨迹；3) 使用基于集合的可达性分析验证轨迹的安全性，考虑环境动态性和不确定性；4) 如果轨迹不安全，则进行路径一致性制动，调整动作序列，使其满足安全约束；5) 执行调整后的安全动作序列。

**关键创新**：最重要的技术创新点在于路径一致性制动。传统的安全过滤方法通常是反应式的，即在每个时间步独立地修改动作。而PACS则考虑了整个轨迹的安全性，通过调整动作序列，确保修改后的轨迹仍然与原始轨迹“相似”，从而保持了策略的行为一致性。这种方法避免了因动作突变而导致的性能下降，并提高了安全过滤的效率。

**关键设计**：PACS的关键设计包括：1) 使用基于集合的可达性分析来验证轨迹的安全性，这种方法可以处理环境动态性和不确定性；2) 设计了一种路径一致性制动算法，该算法通过最小化修改后的轨迹与原始轨迹之间的差异来调整动作序列；3) 采用了一种高效的数值优化方法来实现实时部署。

## 📊 实验亮点

实验结果表明，PACS在模拟和真实世界的人机交互任务中均表现出色。在任务成功率方面，PACS比传统的控制障碍函数方法提高了高达68%。此外，PACS能够提供形式化的安全保证，确保机器人在动态环境中安全运行。实验视频可在项目网站查看。

## 🎯 应用场景

该研究成果可广泛应用于人机协作、自动驾驶、机器人操作等领域。通过确保AI系统在复杂环境中的安全运行，可以提高生产效率，降低安全风险，并促进人与AI系统的和谐共处。尤其在医疗、制造等高风险行业，该技术具有重要的应用价值。

## 📄 摘要（原文）

> Diffusion policies (DPs) achieve state-of-the-art performance on complex manipulation tasks by learning from large-scale demonstration datasets, often spanning multiple embodiments and environments. However, they cannot guarantee safe behavior, so external safety mechanisms are needed. These, however, alter actions in ways unseen during training, causing unpredictable behavior and performance degradation. To address these problems, we propose path-consistent safety filtering (PACS) for DPs. Our approach performs path-consistent braking on a trajectory computed from the sequence of generated actions. In this way, we keep execution consistent with the policy's training distribution, maintaining the learned, task-completing behavior. To enable a real-time deployment and handle uncertainties, we verify safety using set-based reachability analysis. Our experimental evaluation in simulation and on three challenging real-world human-robot interaction tasks shows that PACS (a) provides formal safety guarantees in dynamic environments, (b) preserves task success rates, and (c) outperforms reactive safety approaches, such as control barrier functions, by up to 68% in terms of task success. Videos are available at our project website: https://tum-lsy.github.io/pacs/.

