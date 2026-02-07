# Relatório Completo: Implementação de Batch Transform SageMaker com Go

Este documento registra a interatividade técnica para a construção de uma solução de inferência em lote de alta performance utilizando a linguagem **Go** e a biblioteca **Leaves** (LightGBM).

---

## 1. Introdução e Motivação
A criação de um **Batch Transform Job** no Amazon SageMaker usando **Go** (via AWS SDK for Go v2) oferece uma alternativa de baixa latência e alta eficiência em comparação ao ecossistema tradicional de Python. A solução foca na redução de custos operacionais na região **sa-east-1 (São Paulo)**.

### Principais Ganhos:
*   **Performance:** Uso de Goroutines para processamento paralelo real (sem o gargalo do GIL do Python).
*   **Eficiência de Memória:** Consumo de RAM reduzido de ~1GB para <50MB.
*   **Custo:** Possibilidade de usar instâncias da família `ml.c5` (mais baratas e rápidas em CPU).

---

## 2. Orquestração com Go SDK v2
Para disparar o Job de treinamento e inferência diretamente via Go, utilizamos o método `CreateTransformJob`.

### Exemplo de Configuração de Job:
```go
input := &sagemaker.CreateTransformJobInput{
    TransformJobName: aws.String("job-go-v1"),
    ModelName:        aws.String("meu-modelo-go"),
    MaxConcurrentTransforms: aws.Int32(20),
    MaxPayloadInMB:          aws.Int32(6),
    BatchStrategy:           types.BatchStrategyMultiRecord,
    TransformInput: &types.TransformInput{
        DataSource: &types.TransformDataSource{
            S3DataSource: &types.TransformS3DataSource{
                S3Uri: aws.String("s3://bucket/input/"),
            },
        },
        ContentType: aws.String("text/csv"),
        SplitType:   types.SplitTypeLine,
    },
    TransformResources: &types.TransformResources{
        InstanceCount: aws.Int32(1),
        InstanceType:  types.TrainingInstanceTypeMlC5Xlarge,
    },
}
```

3. O Container de Inferência Genérico (Go + Leaves)
Para permitir que o time de Data Science utilize o mesmo container para múltiplos projetos, a lógica de carregamento do modelo foi movida para Variáveis de Ambiente.
Estratégia de Download Dinâmico (S3)
O binário Go utiliza o S3 Manager para baixar o modelo em pedaços paralelos do S3 seguindo o padrão:
s3://{BUCKET}/{PROJETO_ID}/{EXPERIMENTO_ID}/model.txt
Código Completo do Servidor (main.go)
package main
```
import (
	"context"
	"encoding/csv"
	"fmt"
	"io"
	"net/http"
	"os"
	"strconv"
	"strings"

	"://github.com"
	"://github.com"
	"://github.com"
	"://github.com"
	"://github.com"
)

var (
	model     *leaves.Ensemble
	threshold float64
)

func init() {
	bucket := os.Getenv("MODEL_S3_BUCKET")
	key := os.Getenv("MODEL_S3_KEY")
	region := os.Getenv("AWS_REGION")
	if region == "" { region = "sa-east-1" }
	
	tStr := os.Getenv("PREDICTION_THRESHOLD")
	threshold, _ = strconv.ParseFloat(tStr, 64)

	localPath := "/tmp/model.txt"

	if bucket != "" && key != "" {
		fmt.Printf("[STARTUP] Baixando: s3://%s/%s\n", bucket, key)
		downloadModel(region, bucket, key, localPath)
	} else {
		localPath = "/opt/ml/model/model.txt"
	}

	var err error
	model, err = leaves.BinaryFromFile(localPath)
	if err != nil { panic(err) }
}

func downloadModel(region, bucket, key, dest string) error {
	cfg, _ := config.LoadDefaultConfig(context.TODO(), config.WithRegion(region))
	downloader := manager.NewDownloader(s3.NewFromConfig(cfg))
	f, _ := os.Create(dest)
	defer f.Close()
	_, err := downloader.Download(context.TODO(), f, &s3.GetObjectInput{
		Bucket: aws.String(bucket),
		Key:    aws.String(key),
	})
	return err
}

func invocationsHandler(w http.ResponseWriter, r *http.Request) {
	reader := csv.NewReader(r.Body)
	reader.ReuseRecord = true 
	writer := csv.NewWriter(w)
	defer writer.Flush()

	outDim := model.OutputDimension()

	for {
		record, err := reader.Read()
		if err == io.EOF { break }
		fvals := make([]float64, len(record))
		for i, str := range record {
			val, _ := strconv.ParseFloat(strings.TrimSpace(str), 64)
			fvals[i] = val
		}

		if outDim == 1 {
			res := model.PredictSingle(fvals)
			output := res
			if threshold > 0 {
				if res >= threshold { output = 1 } else { output = 0 }
			}
			writer.Write([]string{strconv.FormatFloat(output, 'f', -1, 64)})
		} else {
			preds := make([]float64, outDim)
			model.Predict(fvals, preds)
			strPreds := make([]string, outDim)
			for i, p := range preds {
				strPreds[i] = strconv.FormatFloat(p, 'f', -1, 64)
			}
			writer.Write(strPreds)
		}
	}
}

func main() {
	http.HandleFunc("/ping", func(w http.ResponseWriter, r *http.Request) { w.WriteHeader(200) })
	http.HandleFunc("/invocations", invocationsHandler)
	http.ListenAndServe(":8080", nil)
}
```

4. Infraestrutura e Docker (Multi-Stage)
O Dockerfile utiliza o estágio de build para gerar um binário estático de apenas ~40MB, reduzindo drasticamente o tempo de "cold start" na AWS.

```
FROM golang:1.21-bullseye AS builder
WORKDIR /app
COPY go.mod go.sum ./
RUN go mod download
COPY . .
RUN CGO_ENABLED=0 go build -ldflags="-s -w" -o /server main.go

FROM debian:bullseye-slim
RUN apt-get update && apt-get install -y ca-certificates && rm -rf /var/lib/apt/lists/*
COPY --from=builder /server /usr/local/bin/server
EXPOSE 8080
ENTRYPOINT ["/usr/local/bin/server"]
```

5. Estudo Comparativo e Custos (sa-east-1)
Recurso	Python (Baseline)	Go (Proposto)
Instância	ml.m5.xlarge ($0.33/h)	ml.c5.large ($0.17/h)
Memória	1GB+	< 50MB
Startup	> 1 min	< 5 segundos
Custo Final	100%	~40% do original

6. Plano de Validação (Sanity Check)
Para garantir que a biblioteca Leaves (Go) gera os mesmos resultados que o LightGBM original (Python):
Referência: Gerar predições via script Python original.
Go Test: Processar o mesmo CSV via servidor Go.
Comparação: Usar o script abaixo para validar a precisão

```
matches = np.isclose(py_preds, go_preds, atol=1e-5).mean()
print(f"Similaridade: {matches * 100:.4f}%")
```

## Para garantir que sua implementação em sa-east-1 não apenas funcione, mas atinja o estado de "bare-metal performance", aqui está a lista detalhada dos gargalos latentes e os pontos de ação para mitigá-los:
## 1. Gargalo de I/O e Serialização (O mais crítico)
O custo de converter texto (CSV) para tipos numéricos (float64) e vice-versa é, muitas vezes, maior que o tempo da predição matemática do modelo.
Ponto de Trabalho: Use strconv.ParseFloat com cautela. Se o volume for extremo, considere trocar CSV por Protobuf ou Avro, que possuem desserialização nativa muito mais rápida em Go.
Ação: Ative o reader.ReuseRecord = true para evitar que o Garbage Collector (GC) precise limpar milhões de pequenos objetos (slices de strings) criados a cada linha lida.
## 2. Gargalo de Concorrência do SageMaker (Orquestração)
Se o SageMaker enviar poucas requisições simultâneas, sua CPU ficará ociosa, desperdiçando o dinheiro pago pela instância.
Ponto de Trabalho: O parâmetro MaxConcurrentTransforms no CreateTransformJob.
Ação: Teste valores agressivos (inicie em 20 e suba até 100). O Go gerencia Goroutines com overhead mínimo; o limite deve ser o saturamento da CPU da instância (mantenha em ~90% no CloudWatch).
## 3. Gargalo de Rede e Latência de Payload
Requisições muito pequenas geram um overhead de cabeçalhos HTTP e negociação de pacotes TCP desnecessário.
Ponto de Trabalho: MaxPayloadInMB e BatchStrategy: MultiRecord.
Ação: Configure o payload para o limite próximo de 20MB. Isso garante que cada "viagem" do S3 para o seu container traga dados suficientes para manter o processador ocupado por mais tempo.
## 4. Gargalo de Memória e Garbage Collection (GC)
O Go pode sofrer pausas de "Stop the World" se houver muitas alocações de memória por segundo, o que aumenta a latência de cauda (P99).
Ponto de Trabalho: Variável de ambiente GOGC.
Ação: Como o container de inferência é focado em uma tarefa única, você pode definir GOGC=off (se tiver RAM sobrando) ou GOGC=200 para reduzir a frequência da coleta de lixo, priorizando a velocidade de processamento.
## 5. Gargalo de Inicialização (Cold Start)
Em instâncias de Batch Transform, o tempo que o container leva para ficar pronto é cobrado.
Ponto de Trabalho: Tamanho da imagem e carregamento do modelo.
Ação: Utilize o S3 Downloader paralelizável (que já incluímos no código) para baixar o model.txt usando múltiplas conexões simultâneas. Isso é vital em sa-east-1 para modelos grandes.
## 6. Gargalo de Tipo de Instância (CPU Bound)
O LightGBM (via Leaves) depende quase exclusivamente da performance de núcleo único e instruções vetoriais da CPU.
Ponto de Trabalho: Seleção da família de instâncias.
Ação: Priorize instâncias C5 ou C6g (Graviton, se compilar Go para ARM). Elas possuem clock superior às instâncias M5 e são otimizadas para cálculos matemáticos, resultando em menor custo por predição.
## 7. Gargalo de Escrita de Resultados
Escrever os resultados de volta para o S3 pode ser lento se não for feito via buffer.
Ponto de Trabalho: csv.Writer com Buffer.
Ação: Sempre use writer.Flush() apenas ao final do processamento do lote e garanta que está escrevendo em blocos, evitando chamadas de sistema (syscalls) para cada linha de predição.


## Profiling 

Para ativar o Profiling em tempo real no seu servidor Go, você só precisa importar o pacote net/http/pprof e iniciar o servidor. Isso permitirá que você veja exatamente onde o binário está gastando CPU (se no parser de CSV ou na predição do Leaves) e como a memória está sendo alocada.
1. Modificações no main.go
```
Adicione o import (o caractere _ serve para registrar as rotas de perfil automaticamente) e inicie o servidor pprof em uma goroutine separada:
import (
	_ "net/http/pprof" // Importação mágica que registra os handlers de profiling
	"net/http"
	"fmt"
)

func main() {
	// Inicia o pprof em uma porta diferente (ex: 6060) para não interferir no SageMaker
	go func() {
		fmt.Println("[DEBUG] Profiler rodando na porta 6060")
		http.ListenAndServe(":6060", nil)
	}()

	// ... seu código original do servidor na porta 8080 ...
}
```
2. Como analisar os Gargalos (Localmente)
Com o servidor rodando e você enviando dados de teste, execute estes comandos no seu terminal:
Verificar uso de CPU
```
go tool pprof http://localhost:6060/debug/pprof/profile?seconds=30
```

Isso gera um relatório de 30 segundos. Digite top no console para ver as funções mais lentas.
Verificar alocações de Memória (Heap):
```
go tool pprof http://localhost:6060/debug/pprof/heap
```

Use o comando svg para gerar um gráfico visual de onde a memória está sendo "presa".
Resumo Final dos Pontos de Atenção (Checklist de Performance)
[ ] Deserialização: O strconv.ParseFloat é o seu maior suspeito de lentidão. Monitore-o no pprof.
[ ] Reuso de Memória: Garanta que reader.ReuseRecord = true está ativo no handler.
[ ] Buffer de Escrita: O csv.NewWriter deve receber o w (ResponseWriter) e o Flush() deve ser chamado só no fim do loop.
[ ] Concorrência: Ajuste MaxConcurrentTransforms no Boto3 para saturar a CPU da instância ml.c5.
[ ] Logs: Remova fmt.Printf dentro do loop de predição; use logs apenas para erros graves.

## 🛠️ Debug e Profiling de Performance
O servidor Go inclui o `net/http/pprof` para análise de gargalos.
- **Porta 8080:** Inferência (SageMaker).
- **Porta 6060:** Profiling (Apenas para ambiente de desenvolvimento).

Para analisar CPU via terminal:
`go tool pprof http://localhost:6060/debug/pprof/profile?seconds=30`

Este setup permite identificar se a latência está no parser de CSV ou no cálculo matemático do modelo.


## 🛠️ Debug e Profiling de Performance
O servidor Go inclui o `net/http/pprof` para análise de gargalos.
- **Porta 8080:** Inferência (SageMaker).
- **Porta 6060:** Profiling (Apenas para ambiente de desenvolvimento).

Para analisar CPU via terminal:
`go tool pprof http://localhost:6060/debug/pprof/profile?seconds=30`

Este setup permite identificar se a latência está no parser de CSV ou no cálculo matemático do modelo.

