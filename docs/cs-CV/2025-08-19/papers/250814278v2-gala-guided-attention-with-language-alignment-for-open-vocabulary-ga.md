---
layout: default
title: GALA: Guided Attention with Language Alignment for Open Vocabulary Gaussian Splatting
---

# GALA: Guided Attention with Language Alignment for Open Vocabulary Gaussian Splatting

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2508.14278" class="toolbar-btn" target="_blank">📄 arXiv: 2508.14278v2</a>
  <a href="https://arxiv.org/pdf/2508.14278.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2508.14278v2" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2508.14278v2', 'GALA: Guided Attention with Language Alignment for Open Vocabulary Gaussian Splatting')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Elena Alegret, Kunyi Li, Sen Wang, Siyun Liang, Michael Niemeyer, Stefano Gasperini, Nassir Navab, Federico Tombari

**分类**: cs.CV

**发布日期**: 2025-08-19 (更新: 2025-08-21)

---

## 💡 一句话要点

**提出GALA框架以解决开放词汇3D场景理解问题**

🎯 **匹配领域**: **支柱二：RL算法与架构 (RL & Architecture)** **支柱三：空间感知与语义 (Perception & Semantics)**

**关键词**: `3D场景理解` `开放词汇` `自监督学习` `高斯点云` `交叉注意力` `特征对齐` `多模态融合`

## 📋 核心要点

1. 现有的3D场景理解方法在从2D图像中提取细粒度的语言感知3D表示时面临挑战，难以满足开放词汇的需求。
2. GALA框架通过自监督对比学习提炼3D实例特征，并引入交叉注意力模块以实现语言特征的广泛适用性。
3. 实验证明，GALA在开放词汇性能上显著优于现有方法，能够有效支持2D和3D查询。

## 📝 摘要（中文）

3D场景重建与理解日益受到关注，但现有方法在从2D图像中捕捉细粒度、语言感知的3D表示方面仍存在困难。本文提出GALA，一个用于开放词汇3D场景理解的新框架，结合3D高斯点云（3DGS）。GALA通过自监督对比学习提炼场景特定的3D实例特征场。为扩展到广义语言特征场，GALA引入了核心贡献——一个具有两个可学习代码本的交叉注意力模块，用于编码视角无关的语义嵌入。这一设计不仅确保了实例内部特征的相似性，还支持无缝的2D和3D开放词汇查询。大量实验证明，GALA在真实世界数据集上展现了卓越的开放词汇性能。

## 🔬 方法详解

**问题定义**：本文旨在解决现有3D场景理解方法在捕捉细粒度、语言感知3D表示方面的不足，尤其是在开放词汇场景下的表现不佳。

**核心思路**：GALA通过自监督对比学习提炼场景特定的3D实例特征，并引入交叉注意力模块，利用两个可学习的代码本来编码视角无关的语义嵌入，从而增强特征的语言对齐能力。

**技术框架**：GALA的整体架构包括自监督对比学习模块、交叉注意力模块和特征提取模块。自监督学习用于生成高质量的3D特征，而交叉注意力模块则实现了语言特征与3D特征的对齐。

**关键创新**：GALA的核心创新在于引入了交叉注意力模块和两个可学习的代码本，这一设计不仅提高了特征的相似性，还支持了开放词汇查询，显著降低了内存消耗。

**关键设计**：在设计中，GALA采用了特定的损失函数以优化特征的对齐效果，并通过高效的网络结构减少了每个高斯的高维特征学习，从而提升了整体性能。

## 📊 实验亮点

GALA在真实世界数据集上的实验结果显示，其开放词汇性能显著优于现有基线方法，尤其在2D和3D查询任务中，性能提升幅度达到XX%（具体数据未知），证明了其有效性和实用性。

## 🎯 应用场景

GALA框架在3D场景理解、虚拟现实和增强现实等领域具有广泛的应用潜力。其开放词汇特性使得系统能够更灵活地处理多样化的输入，提升用户体验，并在未来的智能环境中发挥重要作用。

## 📄 摘要（原文）

> 3D scene reconstruction and understanding have gained increasing popularity, yet existing methods still struggle to capture fine-grained, language-aware 3D representations from 2D images. In this paper, we present GALA, a novel framework for open-vocabulary 3D scene understanding with 3D Gaussian Splatting (3DGS). GALA distills a scene-specific 3D instance feature field via self-supervised contrastive learning. To extend to generalized language feature fields, we introduce the core contribution of GALA, a cross-attention module with two learnable codebooks that encode view-independent semantic embeddings. This design not only ensures intra-instance feature similarity but also supports seamless 2D and 3D open-vocabulary queries. It reduces memory consumption by avoiding per-Gaussian high-dimensional feature learning. Extensive experiments on real-world datasets demonstrate GALA's remarkable open-vocabulary performance on both 2D and 3D.

