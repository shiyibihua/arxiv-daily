---
layout: default
title: E-RayZer: Self-supervised 3D Reconstruction as Spatial Visual Pre-training
---

# E-RayZer: Self-supervised 3D Reconstruction as Spatial Visual Pre-training

<div class="paper-toolbar">
  <div class="toolbar-left">
    <a href="https://arxiv.org/abs/2512.10950" target="_blank" class="toolbar-btn">arXiv: 2512.10950v1</a>
    <a href="https://arxiv.org/pdf/2512.10950.pdf" target="_blank" class="toolbar-btn">PDF</a>
  </div>
  <div class="toolbar-right">
    <button class="toolbar-btn favorite-btn" data-arxiv-id="2512.10950v1" 
            onclick="toggleFavorite(this, '2512.10950v1', 'E-RayZer: Self-supervised 3D Reconstruction as Spatial Visual Pre-training')" title="收藏">
      ☆ 收藏
    </button>
    <button class="toolbar-btn share-btn" onclick="copyLink()" title="复制链接">
      🔗 分享
    </button>
  </div>
</div>


**作者**: Qitao Zhao, Hao Tan, Qianqian Wang, Sai Bi, Kai Zhang, Kalyan Sunkavalli, Shubham Tulsiani, Hanwen Jiang

**分类**: cs.CV

**发布日期**: 2025-12-11

**备注**: Project website: https://qitaozhao.github.io/E-RayZer

---

## 💡 一句话要点

**E-RayZer：提出自监督3D重建框架，作为空间视觉预训练模型。**

🎯 **匹配领域**: **支柱三：空间感知 (Perception & SLAM)**

**关键词**: `自监督学习` `3D重建` `视觉预训练` `多视图几何` `深度学习`

## 📋 核心要点

1. 现有自监督方法在多视图图像中学习3D感知表示方面探索不足，存在间接推断3D几何的局限。
2. E-RayZer通过显式几何直接在3D空间中进行自监督重建，避免了捷径方案，学习几何可靠的表示。
3. 引入细粒度学习课程，无监督地组织训练样本，协调异构数据，实验表明E-RayZer性能显著提升。

## 📝 摘要（中文）

本文提出E-RayZer，一个自监督的大型3D视觉模型，直接从无标签图像中学习具有3D感知能力的表示。与先前的自监督方法（如RayZer）通过潜在空间视图合成间接推断3D不同，E-RayZer直接在3D空间中操作，利用显式几何进行自监督3D重建。这种公式避免了捷径解决方案，并产生几何上可靠的表示。为了确保收敛性和可扩展性，我们引入了一种新颖的细粒度学习课程，以完全无监督的方式组织从易到难的样本训练，并协调异构数据源。实验表明，E-RayZer在姿态估计方面显著优于RayZer，在重建方面达到甚至超过了完全监督的模型（如VGGT）。此外，当迁移到3D下游任务时，其学习到的表示优于领先的视觉预训练模型（如DINOv3、CroCo v2、VideoMAE V2和RayZer），从而将E-RayZer确立为3D感知视觉预训练的新范例。

## 🔬 方法详解

**问题定义**：现有自监督3D表示学习方法，例如RayZer，通常通过潜在空间视图合成来间接推断3D几何，这可能导致学习到的表示缺乏真实的3D几何感知，容易受到捷径方案的影响。因此，如何直接从多视图图像中学习具有显式3D几何感知的表示，是本文要解决的核心问题。

**核心思路**：E-RayZer的核心思路是直接在3D空间中进行自监督重建，利用显式几何信息来约束学习过程。通过这种方式，模型能够学习到更准确、更鲁棒的3D表示，避免了间接推断带来的误差累积和捷径方案。

**技术框架**：E-RayZer的整体框架包含以下几个主要模块：1) 多视图图像输入；2) 3D重建模块，该模块直接在3D空间中进行操作，利用显式几何信息进行自监督重建；3) 细粒度学习课程，用于组织训练样本，并协调异构数据源；4) 表示学习模块，用于学习具有3D感知能力的表示。

**关键创新**：E-RayZer最重要的技术创新点在于其直接在3D空间中进行自监督重建，并利用显式几何信息来约束学习过程。与现有方法相比，E-RayZer避免了间接推断带来的误差累积和捷径方案，能够学习到更准确、更鲁棒的3D表示。此外，细粒度学习课程也是一个重要的创新点，它能够有效地组织训练样本，并协调异构数据源，从而提高模型的收敛性和泛化能力。

**关键设计**：E-RayZer的关键设计包括：1) 使用体素网格或点云等显式几何表示；2) 设计合适的损失函数，例如3D重建损失、几何一致性损失等，以约束学习过程；3) 设计细粒度学习课程，例如从易到难的样本排序、异构数据源的权重调整等；4) 选择合适的网络结构，例如3D卷积神经网络、图神经网络等，以处理3D数据。

## 📊 实验亮点

E-RayZer在姿态估计方面显著优于RayZer，在重建方面达到甚至超过了完全监督的模型（如VGGT）。当迁移到3D下游任务时，其学习到的表示优于领先的视觉预训练模型（如DINOv3、CroCo v2、VideoMAE V2和RayZer）。这些实验结果表明，E-RayZer能够学习到更准确、更鲁棒的3D表示，并具有良好的泛化能力。

## 🎯 应用场景

E-RayZer在机器人导航、自动驾驶、增强现实、虚拟现实等领域具有广泛的应用前景。它可以用于构建更智能、更可靠的3D感知系统，从而提高机器人的自主性和适应性，改善用户在虚拟环境中的沉浸感和交互体验。此外，E-RayZer还可以用于3D内容生成、场景理解等任务，为相关领域的研究和应用提供新的思路和方法。

## 📄 摘要（原文）

> Self-supervised pre-training has revolutionized foundation models for languages, individual 2D images and videos, but remains largely unexplored for learning 3D-aware representations from multi-view images. In this paper, we present E-RayZer, a self-supervised large 3D Vision model that learns truly 3D-aware representations directly from unlabeled images. Unlike prior self-supervised methods such as RayZer that infer 3D indirectly through latent-space view synthesis, E-RayZer operates directly in 3D space, performing self-supervised 3D reconstruction with Explicit geometry. This formulation eliminates shortcut solutions and yields representations that are geometrically grounded. To ensure convergence and scalability, we introduce a novel fine-grained learning curriculum that organizes training from easy to hard samples and harmonizes heterogeneous data sources in an entirely unsupervised manner. Experiments demonstrate that E-RayZer significantly outperforms RayZer on pose estimation, matches or sometimes surpasses fully supervised reconstruction models such as VGGT. Furthermore, its learned representations outperform leading visual pre-training models (e.g., DINOv3, CroCo v2, VideoMAE V2, and RayZer) when transferring to 3D downstream tasks, establishing E-RayZer as a new paradigm for 3D-aware visual pre-training.

