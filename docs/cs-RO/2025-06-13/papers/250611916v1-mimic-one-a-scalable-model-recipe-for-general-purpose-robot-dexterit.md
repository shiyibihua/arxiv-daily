---
layout: default
title: mimic-one: a Scalable Model Recipe for General Purpose Robot Dexterity
---

# mimic-one: a Scalable Model Recipe for General Purpose Robot Dexterity

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2506.11916" class="toolbar-btn" target="_blank">📄 arXiv: 2506.11916v1</a>
  <a href="https://arxiv.org/pdf/2506.11916.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2506.11916v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2506.11916v1', 'mimic-one: a Scalable Model Recipe for General Purpose Robot Dexterity')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Elvis Nava, Victoriano Montesinos, Erik Bauer, Benedek Forrai, Jonas Pai, Stefan Weirich, Stephan-Daniel Gravert, Philipp Wand, Stephan Polinski, Benjamin F. Grewe, Robert K. Katzschmann

**分类**: cs.RO

**发布日期**: 2025-06-13

---

## 💡 一句话要点

**提出一种扩展性模型方案以实现通用机器人灵巧性**

🎯 **匹配领域**: **支柱一：机器人控制 (Robot Control)**

**关键词**: `机器人灵巧性` `扩散模型` `高频生成控制` `自我修正` `数据采集` `端到端学习` `多模态接口`

## 📋 核心要点

1. 现有的机器人操作方法在灵巧性和样本效率上存在不足，难以应对复杂的现实操作场景。
2. 本文提出了一种基于扩散模型的控制方案，结合新设计的腱驱动手和多种数据采集接口，提升了学习效率和操作精度。
3. 实验结果显示，系统在复杂操作中的成功率达到93.3%，并因自我修正行为的引入实现了性能的显著提升。

## 📝 摘要（中文）

本文提出了一种基于扩散模型的方案，用于高灵巧度人形机器人手的现实控制，旨在实现样本高效学习和流畅的精细动作推断。系统采用新设计的16自由度腱驱动手，配备广角腕部摄像头，安装在Franka Emika Panda机械臂上。通过多种接口的远程操作管道和数据收集协议，能够在多样化任务中进行高质量数据采集。利用高频生成控制，从原始传感器输入中训练端到端策略，实现复杂操作场景中的平滑自我修正动作。实验证明，系统在分布外任务中的成功率高达93.3%，并因自我修正行为的出现提升了33.3%的性能，展示了策略性能的扩展趋势。我们的研究推动了灵巧机器人操作的前沿，提供了硬件、学习和现实部署的全面集成方案。

## 🔬 方法详解

**问题定义**：本文旨在解决现有机器人在复杂操作中灵巧性不足和样本效率低的问题，现有方法往往无法有效应对多样化的任务场景。

**核心思路**：提出了一种基于扩散模型的控制方案，通过高频生成控制实现从原始传感器输入到动作输出的端到端学习，旨在提高操作的流畅性和自我修正能力。

**技术框架**：系统由新设计的16自由度腱驱动手、广角腕部摄像头、Franka Emika Panda机械臂以及多种远程操作接口构成，形成一个完整的数据采集和控制流程。

**关键创新**：最重要的创新在于将扩散模型应用于机器人控制，结合自我修正机制，显著提升了机器人在复杂操作中的表现，区别于传统方法的单一控制策略。

**关键设计**：在设计中，采用了高频生成控制技术，优化了损失函数以增强自我修正能力，同时通过多种接口（如手套和VR）实现高质量数据采集，确保了模型的训练效果。

## 📊 实验亮点

实验结果显示，该系统在分布外任务中的成功率高达93.3%，并因自我修正行为的引入，性能提升幅度达到33.3%。这些结果表明，所提出的方法在灵巧机器人操作领域具有显著的优势，超越了现有的基线性能。

## 🎯 应用场景

该研究的潜在应用领域包括工业自动化、服务机器人和医疗辅助等。通过提升机器人在复杂操作中的灵巧性和适应能力，能够在实际场景中实现更高效的任务执行，具有重要的实际价值和广泛的市场前景。

## 📄 摘要（原文）

> We present a diffusion-based model recipe for real-world control of a highly dexterous humanoid robotic hand, designed for sample-efficient learning and smooth fine-motor action inference. Our system features a newly designed 16-DoF tendon-driven hand, equipped with wide angle wrist cameras and mounted on a Franka Emika Panda arm. We develop a versatile teleoperation pipeline and data collection protocol using both glove-based and VR interfaces, enabling high-quality data collection across diverse tasks such as pick and place, item sorting and assembly insertion. Leveraging high-frequency generative control, we train end-to-end policies from raw sensory inputs, enabling smooth, self-correcting motions in complex manipulation scenarios. Real-world evaluations demonstrate up to 93.3% out of distribution success rates, with up to a +33.3% performance boost due to emergent self-correcting behaviors, while also revealing scaling trends in policy performance. Our results advance the state-of-the-art in dexterous robotic manipulation through a fully integrated, practical approach to hardware, learning, and real-world deployment.

