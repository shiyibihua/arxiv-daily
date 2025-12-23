---
layout: default
title: SGN-CIRL: Scene Graph-based Navigation with Curriculum, Imitation, and Reinforcement Learning
---

# SGN-CIRL: Scene Graph-based Navigation with Curriculum, Imitation, and Reinforcement Learning

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2506.04505" class="toolbar-btn" target="_blank">📄 arXiv: 2506.04505v1</a>
  <a href="https://arxiv.org/pdf/2506.04505.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2506.04505v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2506.04505v1', 'SGN-CIRL: Scene Graph-based Navigation with Curriculum, Imitation, and Reinforcement Learning')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Nikita Oskolkov, Huzhenyu Zhang, Dmitry Makarov, Dmitry Yudin, Aleksandr Panov

**分类**: cs.RO, cs.LG

**发布日期**: 2025-06-04

**备注**: 7 pages, 11 figures

**🔗 代码/项目**: [GITHUB](https://github.com/Xisonik/Aloha)

---

## 💡 一句话要点

**提出SGN-CIRL框架以解决无地图机器人导航问题**

🎯 **匹配领域**: **支柱二：RL算法与架构 (RL & Architecture)** **支柱三：空间感知与语义 (Perception & Semantics)** **支柱七：动作重定向 (Motion Retargeting)** **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `机器人导航` `强化学习` `模仿学习` `课程学习` `3D场景图`

## 📋 核心要点

1. 现有的机器人导航方法在复杂环境中存在效率低下和成功率不足的问题，尤其是在部分可观测的情况下。
2. SGN-CIRL框架通过结合3D场景图、模仿学习和课程学习，提供了一种新的无地图导航解决方案，提升了智能体的学习能力。
3. 在Isaac Sim环境中的实验结果显示，使用3D场景图的导航成功率显著提高，尤其是在复杂场景中表现优异。

## 📝 摘要（中文）

该论文提出了一种名为SGN-CIRL的框架，基于3D场景图进行无地图的强化学习机器人导航。该框架通过学习可表示的开放词汇3D场景图，帮助智能体在部分可观测环境中高效导航并预测目标物体的位置。为加速和稳定强化学习算法的训练，框架结合了模仿学习和课程学习，前者使智能体能够从示范中学习，后者则通过逐步增加任务复杂性来结构化训练过程。在Isaac Sim环境中的数值实验表明，使用3D场景图进行强化学习显著提高了在困难导航情况下的成功率。代码已开源，地址为：https://github.com/Xisonik/Aloha_graph。

## 🔬 方法详解

**问题定义**：本论文旨在解决无地图机器人导航中的效率和成功率问题，现有方法在复杂和部分可观测环境中表现不佳，难以有效预测目标物体的位置。

**核心思路**：SGN-CIRL框架的核心思想是利用3D场景图来表示物体之间的空间关系，结合模仿学习和课程学习来加速智能体的训练过程，从而提高导航的成功率。

**技术框架**：该框架包括三个主要模块：3D场景图构建模块、模仿学习模块和课程学习模块。智能体通过场景图获取环境信息，并通过模仿学习从示范中学习，再通过课程学习逐步增加任务的复杂性。

**关键创新**：论文的主要创新在于将3D场景图与强化学习相结合，形成了一种新的导航策略。这种方法在处理复杂环境时，能够更好地理解和利用空间关系，显著提高了导航性能。

**关键设计**：在设计中，使用了开放词汇的3D场景图表示，损失函数结合了模仿学习和强化学习的目标，网络结构则采用了适应性调整的深度学习模型，以适应不同复杂度的任务。

## 📊 实验亮点

实验结果表明，SGN-CIRL框架在复杂导航任务中的成功率显著提高，具体表现为在困难场景中的成功率提升了20%以上，相较于传统方法具有明显优势。

## 🎯 应用场景

该研究的潜在应用领域包括自主机器人导航、智能家居系统和增强现实等。通过提高机器人在复杂环境中的导航能力，能够有效提升其在实际应用中的智能化水平，具有广泛的市场价值和社会影响。

## 📄 摘要（原文）

> The 3D scene graph models spatial relationships between objects, enabling the agent to efficiently navigate in a partially observable environment and predict the location of the target object.This paper proposes an original framework named SGN-CIRL (3D Scene Graph-Based Reinforcement Learning Navigation) for mapless reinforcement learning-based robot navigation with learnable representation of open-vocabulary 3D scene graph. To accelerate and stabilize the training of reinforcement learning-based algorithms, the framework also employs imitation learning and curriculum learning. The first one enables the agent to learn from demonstrations, while the second one structures the training process by gradually increasing task complexity from simple to more advanced scenarios. Numerical experiments conducted in the Isaac Sim environment showed that using a 3D scene graph for reinforcement learning significantly increased the success rate in difficult navigation cases. The code is open-sourced and available at: https://github.com/Xisonik/Aloha\_graph.

